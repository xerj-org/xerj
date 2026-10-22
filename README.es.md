# XERJ

<a href="https://trendshift.io/repositories/116361?utm_source=repository-badge&amp;utm_medium=badge&amp;utm_campaign=badge-repository-116361" target="_blank" rel="noopener noreferrer"><img src="https://trendshift.io/api/badge/repositories/116361" alt="xerj-org%2Fxerj | Trendshift" width="250" height="55"/></a>

[English](./README.md) | [简体中文](./README.zh-CN.md) | [日本語](./README.ja-JP.md) | [العربية](./README.ar.md) | [Español](./README.es.md) | [Türkçe](./README.tr.md)

[![CI](https://img.shields.io/github/actions/workflow/status/xerj-org/xerj/ci.yml?branch=main&style=flat-square&label=CI)](https://github.com/xerj-org/xerj/actions/workflows/ci.yml)
[![Release](https://img.shields.io/github/v/release/xerj-org/xerj?style=flat-square&label=release)](https://github.com/xerj-org/xerj/releases)
[![License](https://img.shields.io/badge/license-Apache--2.0-blue?style=flat-square)](./LICENSE)
[![Stars](https://img.shields.io/github/stars/xerj-org/xerj?style=flat-square)](https://github.com/xerj-org/xerj/stargazers)
[![Rust](https://img.shields.io/badge/built%20with-Rust-000000?style=flat-square&logo=rust)](https://www.rust-lang.org)
[![Discussions](https://img.shields.io/github/discussions/xerj-org/xerj?style=flat-square&label=discussions)](https://github.com/xerj-org/xerj/discussions)
[![Discord](https://img.shields.io/badge/Discord-join-5865F2?style=flat-square&logo=discord&logoColor=white)](https://discord.com/invite/yetXFusXfs)
[![X](https://img.shields.io/badge/X-%40xerj__org-000000?style=flat-square&logo=x&logoColor=white)](https://x.com/xerj_org)

[![Reference coding](https://img.shields.io/badge/reference%20coding-2.7%C3%97%20fewer%20tokens-ff8c00?style=flat-square)](https://xerj.org/case-studies/reference-coding.html)
[![Autoindex](https://img.shields.io/badge/autoindex-zero%20config-ff8c00?style=flat-square)](https://xerj.org/docs/cli.html)
[![Search](https://img.shields.io/badge/search-BM25%20%2B%20kNN%20%2B%20hybrid-8957e5?style=flat-square)](https://xerj.org/docs/queries.html)
[![Agent memory](https://img.shields.io/badge/agent%20memory-%2F__memory-00b3a4?style=flat-square)](https://xerj.org/docs/recipes/agentic-memory.html)
[![MCP](https://img.shields.io/badge/MCP-native-1f6feb?style=flat-square)](https://xerj.org/llms.txt)
[![llms.txt](https://img.shields.io/badge/llms.txt-agent%20ready-6f42c1?style=flat-square)](https://xerj.org/llms.txt)
[![ES-YAML conformance](https://img.shields.io/badge/ES--YAML%20conformance-1366%2F1369-brightgreen?style=flat-square)](https://xerj.org/benchmarks)
[![Single static binary](https://img.shields.io/badge/single%20static%20binary-no%20JVM-orange?style=flat-square)](https://xerj.org/docs/install.html)
[![Default embedder](https://img.shields.io/badge/default%20embedder-lexical%2C%20offline-teal?style=flat-square)](https://xerj.org/docs/vectors.html)
[![Neural](https://img.shields.io/badge/neural%20embedder-opt--in%2C%20downloads%20~90%20MB-9c6ade?style=flat-square)](https://xerj.org/docs/vectors.html)

> Esta página es la traducción al español del [README en inglés](./README.md). Si hay diferencias, prevalece la versión en inglés. Las cifras, los costes y las salidas de ejemplo se toman del original y de los registros que cita; esta traducción no los volvió a medir.

XERJ es una búsqueda local de IA en la que confía la comunidad. Indexa cualquier carpeta
de forma automática, así que tu agente de programación deja de gastar tokens leyendo
archivos uno por uno y recupera el código exacto que necesita. Su uso principal, y donde
más se nota la diferencia, es la programación por referencia (reference coding): le das
una tarea al agente, descarga los repositorios de código abierto más cercanos, los indexa
y reutiliza cómo resolvieron el problema antes de escribir su propio código. En un estudio
controlado eso redujo los tokens de salida de un agente de programación 2.7x, con la misma
tasa de resolución de 16/16
([caso de estudio](https://xerj.org/case-studies/reference-coding.html)), y en el trabajo
diario la gente informa de unas 5x
([informes de campo](./user-feedback/11-reference-coding-field-reports/2026-08-11-token-savings-reports.md)).
Basta para que un modelo más pequeño y barato supere en código a uno más caro que trabaja
de memoria, y para que pases menos tiempo en bucles de corrección. Pruébalo ahora con una
instalación de un solo prompt:

```text
Install XERJ (docs: https://xerj.org/llms.txt), index this project's sources, and set up
reference coding: clone and index the open-source repos closest to what we're building,
and search how they solved a problem before writing code.
```

O ejecútalo tú mismo:

```sh
curl -fsSL https://xerj.org/get | sh
xerj --insecure --data-dir ~/xerj-data &
xerj init                                        # wire XERJ into Claude Code/Cursor (MCP + skill), one command
xerj autoindex ~/my-project
xerj search "how do we rotate the WAL segment"   # ranked passages, file:line
xerj def "euler_to_rotationmatrix"               # go-to-definition: file:line + signature
xerj gain                                        # what it did for you — counted, not estimated
```

Deja ese directorio de datos fuera de cualquier carpeta que vayas a indexar con autoindex. `data/` no está en la lista de ignorados integrada, así que `--data-dir ./data` dentro de un árbol que luego indexas hace que el nodo indexe su propio almacenamiento.

Windows y una instalación comprobada a mano están en [Instalación manual](#instalación-manual).

Esa opción `--insecure` es un límite de confianza, no un formalismo. Desactiva TLS y la
autenticación por clave de API, así que quien pueda llegar al puerto es un superusuario
que puede leer y borrar cada índice, incluido cada espacio de nombres `/_memory`. Está
pensada para un usuario en una máquina de desarrollo: un nodo recién creado solo escucha
en `127.0.0.1`, y un enlace en claro sobre cualquier otra interfaz se niega a arrancar
salvo que lo permitas de forma explícita. El modelo completo está en
[docs/SECURITY_MODEL.md](./docs/SECURITY_MODEL.md).

## Únete a la comunidad

Te unes a XERJ ejecutándolo y devolviendo un informe de campo corto sobre cómo fue: un
solo commit o PR. Ese informe es la credencial de ingreso, y es lo único que el proyecto
pide a cambio de un binario gratuito con licencia Apache-2.0. Es lo que hace que el motor
siga mejorando para quien lo ejecute después.

Las personas y los agentes de IA son bienvenidos; esto no es, a propósito, un proyecto
solo para agentes. Da igual si indexaste un repositorio a la hora de comer o si un agente
instaló XERJ a mitad de sesión en el código de otra persona: lo que se pide es lo mismo,
un informe corto que diga a qué lo apuntaste, para qué lo usaste y tu veredicto honesto.
Un veredicto negativo es un buen informe. Si algo se rompió, eso es un issue o una
corrección aparte, encima del informe.

Los PR que solo contienen un informe de campo están exentos del CLA, así que se fusionan
sin firma. El camino que funciona en cualquier build es un `gh pr create` normal que añada
exactamente un archivo markdown bajo
[`user-feedback/16-agent-field-reports/`](./user-feedback/16-agent-field-reports), sin
nada más en el diff. En un build que lo tenga, `xerj feedback` redacta el informe y
rellena la versión, el sistema operativo y lo que se indexó, y `xerj feedback --open-pr`
abre el PR por ti. Mira `xerj --help` para saber si tu binario tiene el comando.

## El motivo medido: programación por referencia

Un agente que usa grep mete archivos enteros en su contexto, hasta 1.06M tokens de entrada
en un corpus de nuestras mediciones, y aun así tiene que leerlos. Un agente que consulta
XERJ recibe el pasaje. Medido de extremo a extremo sobre código que el modelo no tenía
memorizado
([caso de estudio](https://xerj.org/case-studies/reference-coding.html): 8 tareas, 4 idiomas,
16 ejecuciones por rama, conteos reales de tokens de `claude -p`):

| | tokens de salida | coste | resueltas |
|---|---:|---:|---:|
| solo de memoria | 260,916 | $11.18 | 11/16 |
| agente guiado por grep | 26,477 | $3.27 | 16/16 |
| XERJ | 9,982 | $1.58 | 16/16 |

Eso es 2.7x menos tokens de salida que grep y 26x menos que la memoria sola, con la misma
tasa de resolución, y hasta 278x menos en una sola tarea de Java. En el desarrollo real,
los usuarios informan de unas 5x menos tokens de extremo a extremo
([informes de campo](./user-feedback/11-reference-coding-field-reports/2026-08-11-token-savings-reports.md)).
El valor depende de la memorización: gana en código privado, interno, de nicho o posterior
al corte de entrenamiento, y va de neutro a perjudicial en bibliotecas públicas populares
que el modelo ya conoce. Los límites honestos están en el
[caso de estudio](https://xerj.org/case-studies/reference-coding.html).

## Pásale cualquier carpeta

La programación por referencia es un uso de la misma primitiva: `xerj autoindex <folder>`
hace que un agente conozca un corpus en lugar de hacerle grep. Un comando indexa código,
documentación, logs, PDF, SQLite y CSV incómodos en índices tipados y consultables para
búsqueda, RAG, auditorías de seguridad y memoria de agentes, sin esquema que escribir y
sin pipeline que configurar.

```sh
xerj --insecure --data-dir ~/xerj-data &      # start it
xerj autoindex ~/my-project              # point it at anything
```

`--insecure`, otra vez, significa sin TLS y sin autenticación: cada llamador es un
superusuario. Es el mismo límite de un usuario en una máquina de desarrollo de arriba
([modelo de seguridad](./docs/SECURITY_MODEL.md)).

XERJ olfatea cada archivo, deduce qué es y crea un índice por cada conjunto de datos que
encuentra. El código llega con sus símbolos y números de línea a través de tree-sitter, no
como texto plano:

```
phase A: 593 datasets inferred, 1955 junk/skipped files
phase B: indexing 25329 files with 8 workers
done in 158.1s, 593 datasets, 83103 records live, 790 junk records
```

## Para qué lo usa la gente

- Programación por referencia: indexa los proyectos de código abierto más cercanos a tu
  problema y recupera cómo lo resolvieron antes de escribir código (el uso medido de
  arriba).
- Preguntas y RAG sobre un código base: indexa un repositorio, pregunta por el mecanismo
  y obtén el pasaje con `file:line` en lugar de un listado de directorio.
- Auditorías de seguridad: indexa un árbol objetivo y consulta patrones de sink, secretos
  y llamadas peligrosas en todos los tipos de archivo a la vez.
- Análisis de logs e incidentes: los formatos mezclados se vuelven índices tipados con las
  agregaciones que esperarías de Elasticsearch.
- Memoria a largo plazo del agente: `/_memory/{namespace}` guarda lo que un agente aprende
  y lo recupera por significado en la sesión siguiente.

## Cómo funciona el prompt

[llms.txt](https://xerj.org/llms.txt) le da a tu agente los pasos en orden: instalar,
arrancar el servidor, `xerj autoindex .`, consultar con cualquier cliente de Elasticsearch,
y el bucle de programación por referencia (clonar OSS parecido, indexarlo, recuperar el
mecanismo antes de escribir, citar lo que uses y respetar las licencias).

Por qué ayuda: un agente que trabaja de memoria entra en un bucle de reintentos con
cualquier API que no tenga memorizada, y grep solo le dice dónde mirar; la recuperación
sigue siendo leer el fuente en el contexto, hasta 1.06M tokens de entrada en un corpus de
nuestras mediciones. Un agente que consulta XERJ lee el pasaje exacto. Las 2.7x menos
tokens de salida que grep (26x frente a la memoria sola, 2.1x más barato) con la misma
tasa de resolución de 16/16 están en
[El motivo medido](#el-motivo-medido-programación-por-referencia), junto con una ejecución
acompañante que puntúa 9/9 con recuperación frente a 0/9 de memoria en una biblioteca de
Rust que el modelo nunca había visto.

Más prompts que funcionan en una instalación recién hecha:

- *"Lee https://xerj.org/llms.txt, configura XERJ como tu backend de búsqueda, indexa
  `./docs` y muéstrame una consulta de ejemplo por cada índice que haya creado."*
- *"Ejecuta `xerj autoindex map` y dime qué hay en estos datos (tipos, recuentos y las
  advertencias que registró); después responde a mis preguntas con búsqueda en lugar de
  leer archivos."*
- *"Usa la API `/_memory/notes` de XERJ como tu memoria a largo plazo para este proyecto:
  guarda lo que aprendas mientras trabajas y recupéralo por significado en la sesión
  siguiente."*

Ejemplos trabajados y validados de cada capacidad: [xerj.org/docs/recipes](https://xerj.org/docs/recipes/).

<video src="https://xerj.org/xerj-biz-demo.mp4" poster="docs/media/demo-poster.png" controls muted playsinline width="840">
  <a href="https://xerj.org/aise-demo.html"><img src="docs/media/demo-poster.png" width="840" alt="Ver la demo de XERJ: arranque, ingesta, búsqueda, vectores, paneles"></a>
</video>

<sub>Arranque, ingesta masiva, búsqueda, kNN vectorial, paneles en vivo, sin cortes.
<a href="https://xerj.org/aise-demo.html">Míralo en xerj.org</a> o
<a href="https://xerj.org/playground/">prueba el entorno en vivo</a>.</sub>

## Instalación manual

```sh
curl -fsSL https://xerj.org/get | sh
```

Windows PowerShell:

```powershell
irm https://xerj.org/get.ps1 | iex
```

Un binario estático, sin JVM y sin dependencias. Precompilado para Linux, macOS y Windows
en x86-64 y arm64. También puedes [compilar desde el código fuente](#compilar-desde-el-código-fuente).
Habla la API de Elasticsearch, así que los clientes, paneles y herramientas que ya tienes
funcionan contra él sin cambios.

Primeros comandos después de instalar (el instalador imprime dónde quedó `xerj`; añádelo a
tu PATH si hace falta): `xerj --insecure --data-dir ~/xerj-data &`, espera a que
`http://localhost:9200` responda y luego `xerj autoindex ~/my-project`. Véase
[Indexar una carpeta](#indexar-una-carpeta).

En un host sin acceso a internet en tiempo de ejecución, sigue la
[receta de despliegue aislado](./docs/recipes/air-gapped-deployment.md). El embedder
léxico predeterminado funciona sin red; el modo neuronal necesita los tres archivos del
modelo preparados en local antes de la primera operación semántica.

## Indexar una carpeta

Arranca el servidor y apunta `autoindex` a lo que sea:

```sh
xerj --insecure --data-dir ~/xerj-data &     # local dev: no TLS, no auth
xerj autoindex ~/my-project
```

Ese es el límite de confianza de la máquina de desarrollo del principio de este README:
sin TLS, sin autenticación, cada llamador es un superusuario. En un portátil está bien
porque un nodo recién creado solo escucha en `127.0.0.1` y en nada más; un host compartido
quiere el arranque con autenticación de justo debajo.

Si tu servidor tiene la autenticación activada, que es el valor predeterminado de cada
arranque sin `--insecure` (incluido cualquier arranque desde un archivo de configuración),
pásale a `autoindex` la misma clave. Nunca la toma de `xerj.toml`; pasa `--api-key` o
define `XERJ_API_KEY`, o cada petición vuelve con `401 Unauthorized`:

```sh
xerj --data-dir ~/xerj-data &                          # auth on: key minted on first boot
export XERJ_API_KEY="$(cat ~/xerj-data/admin.key)" # <data_dir>/admin.key
xerj autoindex ~/my-project
```

Esa es toda la puesta en marcha. No hay esquema que escribir ni pipeline que configurar.
XERJ olfatea cada archivo, deduce qué es y crea un índice por cada conjunto de datos que
encuentra:

```
phase A: 593 datasets inferred, 1955 junk/skipped files
phase B: indexing 25329 files with 8 workers
done in 158.1s, 593 datasets, 83103 records live, 790 junk records
```

Los archivos fuente pasan por tree-sitter, así que el código llega con sus símbolos y
números de línea en lugar de como texto plano. CSV, JSON, JSONL, XML, YAML, SQLite, PDF,
DOCX, PowerPoint (`.pptx`, un registro por diapositiva), Excel (`.xlsx`, un conjunto de
datos por hoja), libros EPUB (un registro por capítulo), cuadernos Jupyter (un registro por
sección de encabezado, cualquier kernel), páginas man (roff, un registro por sección), HTML,
correo (`.eml` y buzones mbox, incluido un export de Google Takeout) y los formatos de log
habituales están cubiertos. Los proyectos de Unity reciben un trato de primera clase: las
escenas, prefabs y assets serializados como texto se vuelven un registro por
GameObject/Component, los archivos `.meta` se vuelven una tabla de GUID a ruta, y los
registros MonoBehaviour llevan `script_class`/`script_path`, así que «¿qué escenas usan
este script?» es una sola consulta (los assets serializados en binario necesitan Force Text
para poder leerse; los directorios generados como `Library/` se omiten solos y quedan
registrados).

## Buscar

Esta es la API de Elasticsearch, así que esta parte ya la conoces:

```sh
# what did it find?
curl localhost:9200/_cat/indices

# full-text
curl "localhost:9200/ax-*/_search?q=checkout+error"

# structured
curl localhost:9200/ax-orders/_search -H 'content-type: application/json' -d '{
  "query": { "range": { "total": { "gte": 100 } } },
  "aggs":  { "by_status": { "terms": { "field": "status" } } }
}'
```

La búsqueda vectorial e híbrida usa la misma sintaxis `knn` y `semantic` que enviarías a
Elasticsearch. Cualquier biblioteca cliente de Elasticsearch funciona si la apuntas a
`localhost:9200`.

## Puntuar los resultados con Jev

Una puntuación de búsqueda te dice qué resultado está por encima de cuál, pero no si un
resultado responde de verdad a tu pregunta. [Jev](https://typesafe.ai/blog/introducing-system-one-models-and-jev),
un servicio de TypeSafe AI, hace eso: le das una pregunta y un documento y devuelve un
número de 0 a 1, lo bien que el documento responde. XERJ trabaja con él de dos maneras.

**1. Reordena tus resultados con Jev (opcional).** Añade `"rerank": {}` a un `_search` y
XERJ envía los primeros resultados a Jev, y luego los ordena por los números que recibe.
En la prueba pública FiQA, la calidad del resultado pasa de 0.24 a 0.36 (nDCG@10), por unos
$0.64 en total para 648 búsquedas. Trata los números como una forma de ordenar, no como
porcentajes exactos: no están bien calibrados. **Esto envía el texto de esos resultados a
los servidores de TypeSafe.** Sigue apagado hasta que pongas una clave, y
`[rerank] enabled = false` lo prohíbe por completo. Lee
[`docs/RERANK.md`](./docs/RERANK.md) antes de activarlo.

**2. Obtén el mismo tipo de respuesta en local.** `POST /v1/systemone` y `POST /_decide`
aceptan las mismas preguntas en el mismo formato, pero XERJ las responde él mismo, buscando
los documentos más parecidos que ya hayas etiquetado (por ejemplo mensajes ya marcados como
spam o no spam). Nada sale de tu máquina y no hace falta ninguna clave. Solo funciona si
tienes ejemplos etiquetados; en AG News (120k ejemplos etiquetados) elige la etiqueta
correcta el 92% de las veces. El cliente oficial de Python `jev-reranker` funciona contra
un nodo de XERJ sin cambios
([prueba](./benchmarks/systemone-gate)). XERJ responde bajo su propio nombre,
`xerj-history-vote-1`; no es Jev.

Mediciones y cómo reproducirlas:
[`benchmarks/beir-hybrid`](./benchmarks/beir-hybrid/results/2026-09-20-rerank-full-fiqa) y
[`benchmarks/decisions-as-retrieval`](./benchmarks/decisions-as-retrieval).

## Conectar un agente por MCP

No todo agente puede ejecutar un comando de shell. Los asistentes de escritorio y los hosts
de llamada a funciones llegan a las herramientas por el Model Context Protocol, y el binario
que acabas de instalar es el servidor MCP. No hay nada más que descargar ni nada que
compilar:

```sh
xerj --insecure --data-dir ~/xerj-data &     # 1. the node the tools query
xerj mcp                                # 2. MCP stdio server (your client runs this)
```

`xerj mcp` habla MCP por stdio y hace de proxy hacia el nodo nombrado por `XERJ_URL`
(predeterminado `http://localhost:9200`). No arranca un nodo; el paso 1 es el requisito
previo. El servidor MCP no añade confianza propia: es el mismo binario hablando stdio con
tu cliente y HTTP plano con el nodo, así que el límite que cuenta es el del nodo, y el
paso 1 de arriba arranca el mismo nodo de desarrollo `--insecure`. Suelta esto en la
configuración de tu cliente MCP:

```json
{
  "mcpServers": {
    "xerj": {
      "command": "/home/you/.local/bin/xerj",
      "args": ["mcp"],
      "env": { "XERJ_URL": "http://localhost:9200" }
    }
  }
}
```

Usa una ruta absoluta. El instalador pone `xerj` en `~/.local/bin` de forma predeterminada
(`command -v xerj` lo confirma), y los hosts MCP lanzados desde un icono de escritorio no
heredan el `PATH` de tu shell. Si el nodo corre con autenticación (cualquier cosa que no
sea `--insecure`), añade `"XERJ_AUTH": "ApiKey <key>"` junto a `XERJ_URL`; la clave está
en `<data-dir>/admin.key`.

Se exponen trece herramientas. Once son proxies finos sobre un endpoint que XERJ ya sirve:

| Herramienta | Qué hace |
|---|---|
| `xerj_search` | búsqueda con el DSL de consultas de ES sobre un índice |
| `xerj_semantic_search` | recuperación por significado sobre un campo `semantic_text`; la consulta se embebe en el servidor (el embedder predeterminado es hashing de rasgos léxico, no neuronal, salvo que el nodo corra con `--embed-mode neural`) |
| `xerj_vector_search` | kNN sobre un campo `dense_vector` |
| `xerj_hybrid_search` | fusión RRF o lineal de subconsultas |
| `xerj_memory_store` / `xerj_memory_recall` | memoria durable del agente en un espacio de nombres, recuperada por texto, significado o vector |
| `xerj_brain_overview` / `xerj_brain_ego` / `xerj_brain_link` / `xerj_brain_unlink` | el índice de enlaces del segundo cerebro: orientarse, expandir el vecindario con evidencia de un nodo, afirmar y retirar enlaces |
| `xerj_plan` | entra un filtro en palabras llanas, sale un DSL de consulta validado (`POST /_ask`; determinista y basado en reglas, no un LLM) |

Dos más no son proxies planos: `xerj_map` devuelve el mapa de campos por índice del
catálogo de autoindex (recortado a un tope de bytes, y por lo demás textual), y
`xerj_code_search` ejecuta el pipeline de programación por referencia de `xerj code`
([`tools/xerj-code/`](tools/xerj-code/)) y devuelve su texto renderizado.

`xerj mcp --help` imprime el mismo bloque de configuración y la lista completa de
opciones. Los esquemas de herramientas legibles por máquina están publicados en
[xerj.org/docs/agents/schemas/mcp-tools.json](https://xerj.org/docs/agents/schemas/mcp-tools.json),
generados desde un `tools/list` en vivo, nunca escritos a mano, y vigilados en CI
(`scripts/mcp-schema-check.sh`) más un test unitario, así que la lista publicada no puede
apartarse de la que se sirve.

## Por qué existe

Los agentes queman su ventana de contexto leyendo archivos. El PHP del núcleo de WordPress
son unos 5.2 millones de tokens, o 26 ventanas de contexto completas, así que un agente no
puede simplemente leerlo. Grep tampoco lo resuelve, porque un acierto de grep es una línea,
y juzgar esa línea significa abrir el archivo entero.

Consultar un índice cuesta kilobytes por pregunta. En
[una auditoría de seguridad con IA del núcleo de WordPress](https://xerj.org/use-cases/code-security-audit.html),
un agente trabajó sobre 1,492 archivos PHP con unos 26,000 tokens, que es lo que hace falta
para cargar cerca de medio punto porcentual del árbol.

## Casos de uso

- [Programación por referencia](https://xerj.org/case-studies/reference-coding.html): tu
  agente de programación recupera cómo los proyectos pares ya lo resolvieron en lugar de
  volver a derivarlo. Medido: 2.7x menos tokens de salida que programar guiado por grep
  (26x frente a la memoria sola); los usuarios informan de ~5x en el desarrollo real.
- [Búsqueda de código y auditorías de seguridad](https://xerj.org/use-cases/code-security-audit.html):
  indexación consciente del AST, así que un agente encuentra una función en lugar de una
  línea.
- [Búsqueda con IA y RAG](https://xerj.org/use-cases/ai-search-retrieval.html): recuperación
  de texto completo, vectorial e híbrida en una consulta, sin una base de datos vectorial
  aparte.
- [Memoria del agente](https://xerj.org/use-cases/second-brain.html): recuerdo durable con
  un grafo de conocimiento sobre tus propios documentos.
- [Analítica de logs y observabilidad](https://xerj.org/use-cases/unified-observability.html):
  logs, métricas y trazas en un motor.
- [Sustituto de Elasticsearch](https://xerj.org/use-cases/elasticsearch-replacement.html):
  el mismo protocolo de cable, un binario.

Los ejemplos ejecutables viven en [`recipes/`](./recipes) y [`docs/examples/`](./docs/examples).

## Compatibilidad con Elasticsearch

XERJ implementa la API REST de Elasticsearch: índices, documentos, bulk, búsqueda,
agregaciones, mappings, kNN, scroll, reindex y los endpoints `_cat`. Kibana y las
bibliotecas cliente oficiales se conectan directamente. Un límite que conviene conocer
antes de apuntarle herramientas de exportación: scroll es una instantánea acotada calculada
de antemano, no un cursor que recorre segmentos, así que una consulta cuyo total exacto
supera la ventana de la instantánea se rechaza con un `400` en lugar de truncarse en
silencio. Usa `search_after` para conjuntos de resultados de cualquier tamaño
([el tope](https://xerj.org/docs/api-es-compat.html#scroll-cap)).

La suite de conformidad corre en cada commit y ahora mismo pasa 1366 de 1369 casos. Vive
en [`engine/tests/es-compat-yaml`](./engine/tests/es-compat-yaml), y los huecos que quedan
están listados ahí en lugar de ocultos. XERJ es compatible con la API. No es una
reimplementación de los internos de Elasticsearch, y no es un fork.

## Pruebas comparativas

XERJ se mide cara a cara contra Elasticsearch 8.13.4 en ingesta, búsqueda de texto
completo, agregaciones, búsqueda vectorial y lecturas emitidas bajo una avalancha de
escrituras concurrentes. La última ejecución en bucle cerrado puntúa 55 victorias, 26
empates y 4 derrotas, incluido 1.72x de rendimiento de ingesta y una huella en disco 1.61x
más pequeña.

Las cuatro derrotas son el mismo hueco: el p99 de lectura mientras corre un escritor de
alto ritmo. Está
[escrito por completo](./demo/playbooks/MIXED_READ_UNDER_WRITE_FINDING_2026-07-08.md) en
lugar de omitido. Los resultados, la metodología y el arnés están en
[xerj.org/benchmarks](https://xerj.org/benchmarks) y en
[`demo/playbooks`](./demo/playbooks), para que puedas repetirlos tú. Trata con escepticismo
cualquier número que no puedas reproducir, incluidos los nuestros.

### Indexación de código

Los archivos fuente se parsean con tree-sitter y se indexan con conciencia del AST —
símbolos más el texto completo — así que un agente recupera una función, no una línea. En
un checkout de Apache Lucene (6,113 archivos fuente, 51 MB) la extracción en proceso a un
solo hilo corre a **~1,500 archivos/s (13 MB/s)**; el parse de tree-sitter es ~72% de eso
y es el suelo por archivo. Reprodúcelo con:

```sh
XERJ_EXTRACT_BENCH=/path/to/repo cargo test -p xerj-autoindex --release \
  extract_bench -- --nocapture --ignored
```

La reindexación es **incremental**: un archivo cuyo contenido es idéntico byte a byte a la
última generación indexada se salta el parse por completo y arrastra su resultado ya
confirmado, así que una nueva pasada después de editar un puñado de archivos hace un
trabajo proporcional a lo que cambió, no al repositorio entero — el caso habitual de
editar y volver a correr, o de CI, típicamente más del 95% sin cambios. El hash completo
del contenido sigue ejecutándose para detectar cambios, así que el tiempo total de
reindexación tiene como suelo el hashing, no el parseo.

## Compilar desde el código fuente

Necesitas una cadena de herramientas de Rust estable.

```sh
git clone https://github.com/xerj-org/xerj
cd xerj/engine
cargo build --release -p xerj-server
./target/release/xerj --insecure --data-dir ~/xerj-data
```

Para correr la suite de conformidad contra un servidor en marcha:

```sh
cargo run --release -p es-yaml-runner -- --dir tests/es-compat-yaml/yaml
```

## Documentación

- [Guías y referencia de la API](https://xerj.org/docs/)
- [Recetas](https://xerj.org/docs/recipes/) para tareas habituales
- [Hoja de ruta](./ROADMAP.md): qué se publica hoy frente a lo que viene, verificado contra
  el binario de la release. Vista release por release:
  [hitos](https://github.com/xerj-org/xerj/milestones); estado en vivo:
  [tablero del proyecto](https://github.com/users/xerj-org/projects/1); puntero fijo:
  [issue anclado de la hoja de ruta](https://github.com/xerj-org/xerj/issues/298)
- [Registro de cambios](./CHANGELOG.md)

Páginas de referencia de subsistemas concretos, escritas contra el fuente e incluyendo los
límites que cada uno no levanta:

- [Segundo cerebro](./docs/SECOND_BRAIN.md) para la capa de relaciones sobre documentos
  indexados: las rutas `/_graph`, la evidencia en los enlaces, los ocho detectores y el
  tope de dos saltos.
- [Lector de la consola](./docs/CONSOLE_READER.md) para el inicio de corpus de la consola,
  el lector de cualquier registro (un correo con sus adjuntos, una página de PDF) y el
  modo invitado de solo lectura, con las reglas de renderizado que mantienen inerte un
  documento hostil y lo que no renderiza.
- [Scripting](./docs/SCRIPTING.md) para el subconjunto de Painless, dónde corren los
  scripts y los límites de recursos que los acotan.
- [Instantánea y restauración](./docs/SNAPSHOT_AND_RESTORE.md) para el subconjunto
  admitido de la API de snapshots, y qué sustituye una restauración.
- [Compartir](./docs/SHARING.md) para `xerj share`: acceso de invitado de solo lectura a
  una carpeta indexada mediante un enlace y un código, qué puede y qué no puede alcanzar
  un invitado, y el modelo de amenazas.
- [Modelo de seguridad](./docs/SECURITY_MODEL.md) para la autenticación, el espacio de
  nombres reservado `.xerj-memory-*`, las claves de API y lo que no se exige.
- [Reordenación](./docs/RERANK.md) para la etapa de búsqueda `rerank` opcional: un juez
  externo reordena los primeros aciertos por una probabilidad calibrada. Es la única
  función en tiempo de búsqueda que envía texto de documentos fuera del nodo (los
  embeddings por proxy y la toma del WAL también envían texto cuando un operador los
  configura; la página lista cada conexión saliente que un nodo puede abrir), necesita
  una clave de proveedor configurada por el operador, y la calidad de su ordenación con
  el modelo real no está verificada.
- [XERJ frente a Lucene 10.3.1](./docs/XERJ_VS_LUCENE.md) para una comparación fijada al
  fuente, en seis ejes, de sus diseños de almacenamiento y búsqueda.

## Contribuir

Los pull requests son bienvenidos tanto de personas como de agentes de IA; véase
[Únete a la comunidad](#únete-a-la-comunidad) arriba. La contribución de base es un
informe de campo corto: un `gh pr create` normal que añada un archivo markdown bajo
[`user-feedback/16-agent-field-reports/`](./user-feedback/16-agent-field-reports).
Los PR que solo contienen un informe de campo están exentos del CLA, así que se fusionan
sin firma.

Para cambios de código, véase [CONTRIBUTING.md](./CONTRIBUTING.md) para el flujo de
trabajo y [CLA.md](./CLA.md) para el acuerdo de licencia de colaborador, que es una firma
por colaborador y no una por pull request. Los agentes que abran un PR deben decir que lo
escribió un agente y seguir [AGENTS.md](./AGENTS.md) /
[.github/AI_CONTRIBUTIONS.md](./.github/AI_CONTRIBUTIONS.md).

Los bugs y las peticiones de funcionalidad van a las [issues de GitHub](https://github.com/xerj-org/xerj/issues).

## Licencia

[Apache 2.0](./LICENSE).
