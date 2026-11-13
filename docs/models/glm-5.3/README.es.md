# GLM-5.3 Flash: el par USB4 y una RTX PRO 6000

[English](README.md) · [Español](README.es.md) · [README principal](../../../README.es.md)

GLM-5.3 Flash, EXL3 4.05 bpw. En dos nodos Strix Halo (TP2 sobre USB4) está en Production: identidad de decode R1b por
defecto, autoespeculación MTP exacta por defecto, prefill exacto R1 por chunks. En una RTX PRO 6000 (Windows) es un
borrador opcional (opt-in): prefill exacto y decode greedy con los expertos enrutados servidos a través de la caché
por niveles de tierstream. Esta página conserva todas las mediciones publicadas con su compilación y sus condiciones y
los comandos de lanzamiento. Cómo se leen las tablas y qué cubre "exacto": [metodología](../../methodology.es.md).
Instrucciones de compilación (biblioteca trellis incluida): [primeros pasos](../../getting-started/README.es.md); el par
en sí: [dos nodos por USB4](../../pair.es.md).

<a id="glm-pair"></a>

## Ejecución: el par

La división de GLM por tokens es un perfil FAST de memoria calificado. Está desactivada por defecto;
`STRIX_GLM_KV_SHARD=auto` (con `STRIX_GLM_PF_PIPELINE=1`) selecciona la división solo después de que todos los candidatos replicados
de scratch/ventana permitidos fallen la admisión de inicio en alguno de los ranks; `=1` fuerza la división y `=0` fuerza la replicación. Exige una solicitud,
`STRIX_GLM_PF_PIPELINE=1`, prefill por chunks y ausencia de MTP o especulación. FAST cambia el
orden de suma, por lo que no es bit a bit igual al perfil exacto replicado predeterminado.
Consulte la [guía de almacenamiento KV y división por tokens](../../engine/kv-sharding.es.md)
para conocer la organización, los límites de contexto y tiempos medidos, la verificación y los
costes. El experimento de transporte independiente `STRIX_XPORT_SMALL_SPIN=1` activa progreso
acotado para mensajes pequeños; sin definir o con `0`, restaura el progreso anterior tras reiniciar.
Véanse los [contratos de funciones](../../optimizations.md#kv-cache-sharding-and-shared-transport-progress).

La capacidad del prefill se elige al arrancar. `STRIX_GLM_PF_SCRATCH` (`auto` predeterminado, `full`, `routed`) y
`STRIX_GLM_PF_ATTN_QWIN` (`auto` predeterminado, o de 0 a 65536 filas de consulta; `0` = el chunk entero) eligen la
organización del scratch de prefill y la ventana de consultas de atención. `auto` prueba, en orden, scratch completo
con atención sobre el chunk entero, scratch enrutado con atención sobre el chunk entero y, por último, scratch
enrutado con una ventana de 2048 filas; un rechazo en cualquiera de los ranks descarta el candidato, y la admisión
cuenta el límite compartido de instalación/staging en el dispositivo y en el host. El scratch enrutado elimina solo
el arena heredado de MoE agrupado que no se usa; la ventana acota el scratch de atención, mientras que el tamaño de
chunk y la aritmética por fila no cambian. Un valor explícito fija su eje. La alternativa necesita la votación
interna de arranque; con un intercambio externo se mantiene la organización inicial. Cada rank imprime una línea
`glm capacity: rank=... scratch requested=... resolved=...; qwin requested=... resolved=...; kv=... reason=...`.
Los demás valores se rechazan al arrancar. Reinicie ambos ranks tras un cambio. La selección está cubierta por
pruebas de host de la matriz de admisión; no se publican cifras nativas de bytes, tiempo hasta el primer token ni
capacidad para este control.

Paralelismo de secuencia del prefill, `STRIX_GLM_PF_SEQPAR` (`auto` predeterminado, `1`, `0`): en chunks con un
número par de filas (al menos 2), cada rank ejecuta residual/mHC/norm sobre su mitad de las filas y las mitades se
unen con un all-gather solapado que reutiliza el ciclo de CRC/drenado del intercambio; con
`STRIX_GLM_PF_PIPELINE=2` y un número de filas múltiplo de 4, cada mitad se divide en dos tiles. Los chunks impares
y de una sola fila siguen la ruta heredada. Necesita dos ranks con comunicador TP2, sin intercambio externo y sin
división del KV: `auto` lo declina con una línea en stderr que indica el motivo, y `1` sin esas condiciones se
rechaza al arrancar. Los ranks comparan su política y rechazan una discrepancia. `0` restaura la ruta heredada.
Reinicie ambos ranks tras un cambio.

`STRIX_GLM_PF_AUX_COMBINE` está activado de forma predeterminada (sin definir o `1`); `=0` restaura
la ruta anterior. `STRIX_GLM_PF_IN_TOKEN` (transformación de entrada gate/up del MoE en orden de tokens,
bit a bit) está activado de forma predeterminada (sin definir o `1`); `=0` restaura la transformación por tiles. `STRIX_GLM_PF_AUX_INPUT`, `STRIX_GLM_PF_AUX_ACT`, `STRIX_GLM_PF_AUX_DENSE` y
`STRIX_GLM_PF_AUX_NORM` son optativos (`=1` los activa; sin definir o `=0` los desactiva). Estos
interruptores solo aceptan `0` o `1`.

Los selectores de variante de kernel del prefill (`STRIX_GLM_PF_HC`, `_MLA`, `_IDX`, `_SELECT`, `_OBAR`,
`_MLA_GEMM`, `_SCORES`, `_KDA_SCAN`, `_DENSE_ROWS`, `_DENSE_FORM`) comparten una tabla que usan el motor y
`--print-effective-config`. Sin definir se elige el predeterminado; cualquier valor definido, incluido el vacío,
debe ser una variante de la lista o el arranque se rechaza con
`ENV='v' is not a known variant (allowed: ...; unset = D)`. La línea de configuración efectiva indica la variante
que se ejecuta.

| Variable | Valores admitidos (predeterminado primero) |
|---|---|
| `STRIX_GLM_PF_HC` | 2, 1 |
| `STRIX_GLM_PF_MLA` | 2, 1 |
| `STRIX_GLM_PF_IDX` | 3, 2, 1 |
| `STRIX_GLM_PF_SELECT` | 2, 1 |
| `STRIX_GLM_PF_OBAR` | 10, 7, 6, 5, 4, 2 |
| `STRIX_GLM_PF_MLA_GEMM` | 3, 2, 1 |
| `STRIX_GLM_PF_SCORES` | 7, 6, 5, 4, 3, 2 |
| `STRIX_GLM_PF_KDA_SCAN` | 5, 3, 1 |
| `STRIX_GLM_PF_DENSE_ROWS` | 4, 3, 2, 1 |
| `STRIX_GLM_PF_DENSE_FORM` | 0, 1, 2, 3, 4, 5, 6, 7 (forma física de la versión 4; 0 = automática según la forma de la llamada) |

Con `STRIX_XPORT_TRACE=1`, el intercambio del prefill imprime
`xport prefill bytes=... copied=... messages=... reuse_dependencies=...` al cerrarse. `reuse_dependencies`
(antes `exposed_wait`) cuenta aristas de eventos de reutilización de búferes, dos por cada reutilización trazada;
no es tiempo transcurrido.

Ejecute una vez por nodo con `R` establecido en 0 o 1 y el mismo prompt tokenizado en ambos:

```sh
./build/strix-glm5-rank MODEL_DIR --world 2 --rank R --transport usb4-auto --prompt PROMPT.u32 --decode 64
```

El decode R1b predeterminado usa autoespeculación MTP exacta y prefill de prompt R1; `--mtp 0` ejecuta decode simple
con los mismos tokens. Ambos rangos arrancan el temporizador del prefill tras una barrera del par, de modo que los dos
informan el mismo tiempo de prefill y ninguno incluye el tiempo de carga del otro (se imprime la espera en la barrera;
`STRIX_GLM_PF_TIMER_BARRIER=0` restaura el arranque anterior). `strix-tokenize MODEL_DIR encode|plain|decode FILE` ejecuta el tokenizador del motor (el
mismo `MODEL_DIR/tokenizer.json` que carga el servidor) en la línea de comandos. `--identity r1` selecciona una identidad de referencia distinta. El prefill usa automáticamente
8192 filas si ambos ranks las admiten; en caso contrario, 4096. Véanse el [resolutor](../../../apps/glm_rank_defaults.hpp),
las [familias de modelos](../model-families.md) y la [cualificación/rendimiento](../../performance.md).

Interruptores MLA del prefill: `STRIX_GLM_PF_SCORES=6` y `STRIX_GLM_PF_OBAR=7` (o-bar v7; `=5` v5) restauran etapas anteriores; la o-bar v10, predeterminada, prepara 2 k por lote con las mismas cadenas (logits del par idénticos bit a bit a la v7 con 8K y 32K; tiempo de o-bar un 7-9 % menor, TTFT con 8K −0.7 % y con 32K −0.3 %). `STRIX_GLM_PF_MLA_GEMM=2` restaura la GEMM v2 (`=1`, la heredada); la v3, predeterminada, conserva las cadenas FMA con k ascendente (logits y estado del par idénticos bit a bit a la v2 con 8K y 32K; tiempo de la GEMM MLA un 41-43 % menor, TTFT con 8K −1.9 % y con 32K −2.3 %).

<a id="glm-serve"></a>

## Servicio: el par

`strix-glm5-serve` es el servidor HTTP (`/v1/chat/completions` y `/v1/completions` de OpenAI con streaming SSE,
`/v1/models`, `/health`). Arranque primero el rank 1 y después el rank 0; ambos reciben las mismas opciones del motor
(el saludo inicial rechaza una discrepancia) y leen el tokenizador de `MODEL_DIR/tokenizer.json`:

```sh
./build/strix-glm5-serve MODEL_DIR --world 2 --rank 1 --transport usb4-auto
./build/strix-glm5-serve MODEL_DIR --world 2 --rank 0 --transport usb4-auto --host 0.0.0.0 --port 8080 --model-id glm-5.3-flash
```

Valores predeterminados: 8 slots de petición (`--slots`, 8 como máximo), 8192 posiciones por slot (`--capacity`),
autoespeculación MTP exacta con una sola petición en curso, verificación MTP por lotes con varias
(`STRIX_GLM_SERVE_G2=0` = pasos simples por lotes) y prefill por chunks de 512 tokens con prioridad al decode mientras
otras peticiones decodifican (`--prefill-chunk 0` = prompts enteros). `--serial` admite una petición cada vez;
`--api-key-file F` exige una clave bearer. `--selftest N` en el rank 0 (sin HTTP) ejecuta N prompts integrados juntos
y cada uno por separado e informa EXACT/FAIL con tok/s por nivel de concurrencia.

`--prefix-cache-gib G` fija la LRU de snapshots de prompts en RAM en G GiB por rango
(4 por defecto; `--prefix-cache-gib 0` la desactiva; ambos rangos deben usar el mismo presupuesto). Solo se guarda si ambos rangos
confirman su snapshot y cada uno tiene al menos 16 GiB de MemAvailable; sin lectura de memoria o si
el snapshot supera el presupuesto, se rechaza el guardado. Un acierto restaura la clave de prefijo
estricto más larga y procesa el sufijo con el planificador de chunks habitual. Con MTP, la clave
incluye el primer token greedy de salida y se restaura en la frontera del prompt original.
El contrato exige restauración exacta del tronco y tokens emitidos iguales; las filas MTP conservan
la regla existente de chunks. Con la caché activa, `strix.prefix_cache` informa de `hit_tokens`,
`prefill_tokens` y `restore_ms`. `--selftest N --selftest-prefix` compara
conversaciones de dos turnos con repeticiones tras vaciar la caché y exige aciertos;
`--selftest-prefix-long L` usa primeros turnos de unos L tokens e imprime el tiempo de admisión a listo
del turno 2 desde la caché y en frío. Los demás selftests también restauran prompts repetidos desde la
caché; use `--prefix-cache-gib 0` para cifras sin caché.

El límite RSS predeterminado del watchdog de memoria es 8 GiB más el presupuesto
de caché de prefijos por rango, para no tratar los snapshots retenidos como una fuga.
`STRIX_GLM_WD_RSS_GIB` sustituye ese límite total (0 desactiva la comprobación RSS);
los límites de RAM libre, swap y GTT no cambian. Sin caché, el valor sigue siendo 8 GiB.

## Ejecución: una RTX PRO 6000

Solo Windows, opcional (opt-in): compile con `pwsh src/glm/rtxpf/producer/build.ps1` contra una exportación del código
de tierstream, genere una vez el archivo de unidades con `glm_unit_file.exe` y ejecute
`decode_qualification_window.py --full-card --allow-gpu`. El propio servicio acepta también `--dgpu auto|<uuid>`
para elegir la RTX PRO antes de iniciar CUDA (`off` se rechaza: no hay ruta en CPU). Todos los pasos, el commit fijado de tierstream y las
opciones (`--profile`, `--print-effective-config`, `--vram-total-gib`) están en la
[guía de GLM RTX](../../../src/glm/rtxpf/README.md).

<a id="how-fast"></a>

## Resultados medidos: el par

Fuentes: [registros de rendimiento](../../performance.md) y [valores predeterminados/pruebas actuales de GLM](../../optimizations.md#glm).

EXL3 4.05 bpw, dos nodos Strix Halo TP2 sobre USB4. Motor en Production. R1b es la identidad de decode predeterminada; los prompts usan prefill por fragmentos R1 exacto;
el decode usa autoespeculación MTP exacta por defecto (`--mtp 0` = decode simple).
`--identity r1` restaura R1 en todo el proceso. Las mediciones históricas de R1 siguientes conservan su identidad original.

El prefill del prompt en las ejecuciones de decode con dos ranks usa por defecto 8192 filas cuando ambos ranks admiten la carga calibrada
y todos los propietarios del prefill; en caso contrario, ambos usan 4096. Esto se aplica al decode de producción con autoespeculación MTP
y al prefill por fragmentos simple dentro de ejecuciones `--decode`. La selección usa el margen de RAM
y GTT de la admisión de carga, el staging, las reservas, las lecturas de tensores completos y el búfer de rebote, más el crecimiento de prefill y de comunicación
y la protección de memoria libre del dispositivo.
Se conserva el mayor entre el margen de carga, el margen de prefill y 8 GiB. El decode Comm normal con dos ranks reutiliza
su intercambio de configuración existente y su voto de discrepancia para acordar el modo y el mínimo de filas propuestas.
Los modos fijos conservan sus bytes de carga útil y el orden de etiquetas; los modos mixtos auto/fijo se rechazan en ambos ranks.
Los pools de comunicación automáticos empiezan en 4096 y solo crecen tras acordar 8192. Una nueva comprobación de admisión
tras el crecimiento usa un único voto mínimo solo automático y reduce ambos pools en caso de volver a 4096.
Las ejecuciones Comm con dos ranks sin ese handshake (solo prefill, gates de referencia y solo batch) usan 4096 en modo
auto, con origen `auto-4096-no-handshake`, sin intercambio de control. Los recuentos de filas explícitos deben coincidir.
`--pf-ttft` y los arneses de gates mantienen 4096 salvo que se indique explícitamente `--max-rows 8192`.
Ahí no se pueden comprobar discrepancias de filas fijas al arrancar sin
cambiar el protocolo existente. `--xch xfer` externo en auto usa 4096 sin intercambio de acuerdo.
El prefill de referencia (`--prefill ref`, prefill automático con `r1b-all` o `--idcheck` con decode) usa
4096 en modo auto (`auto-4096-ref`) sin intercambio de acuerdo del recuento de filas.
La ruta de prefill exacta conserva su aritmética entre tamaños de fragmento; el TTFT medido en la ruta de prefill por fragmentos
con 8192 filas mejora un 4 % a 8K y de 116.3 a 109.9 s (5.5 %) a 32K, usando unos 7.3 GiB más de
memoria de GPU por nodo.
`STRIX_GLM_MAX_ROWS_AUTO=0` restaura el valor fijo 4096; `--baseline` mantiene 1024, y un `--max-rows` explícito mantiene su valor.
`--print-effective-config` informa del candidato independiente del host y de la política de arranque; stderr informa
del margen de admisión y del valor final con su origen. Véase el [catálogo](../../optimizations.md#glm-max-rows-auto).
La admisión de arranque incluye la ruta de prefill y su espacio de trabajo para las filas y el nivel seleccionados, de modo que
un rank que no los admite se rechaza antes de cargar los pesos. La admisión posterior a la carga usa el mismo
presupuesto. Las claves de puntuación del indexador se dimensionan por fragmento, no por la capacidad de contexto. stderr informa
en GiB de los términos de ruta, espacio de trabajo, instalación/staging, seguridad tardía y reserva de arranque.

| Modo | Prompt / contexto | Medido | Build / exactitud |
|---|---|---:|---|
| Decode greedy, R1 | prompt de chat de 31 tokens + 64 tokens generados | **45.29 ms/token = 22.1 tok/s**; **51 %** del suelo calculado de 23.2 ms | `1836c99c`; tokens iguales a la referencia |
| Decode por batch, R1 | Ocho filas independientes, contexto del benchmark no especificado | **122.0 ms/step = 65.5 tok/s agregados** | `1836c99c`; tokens iguales a la referencia anterior del par real |
| Prefill por fragmentos exacto | prompts de benchmark de 1K / 8K / 32K, tipo no especificado | TTFT **4.268 / 34.70 / 144.75 s** (240 / 236 / 226 tok/s) | `875ca821`, integrado en `41d8cfdc`; los logits de ambos ranks son iguales bit a bit al prefill exacto anterior |
| R1b-fast, ahora la identidad de decode predeterminada | Mismo benchmark de chat, comparación alterna de 96 tokens | **41.93–41.96 ms/token**, frente a R1 47.33–47.48 (**−11.5 %**, **55 %** del suelo de 23.2 ms) | `8877de1d`; estable dentro de cada identidad, no igual bit a bit a R1 |
| Autoespeculación MTP (predeterminada) | Prompts de chat / código / JSON, 64–128 tokens generados, rank 0 | **26.98 / 22.46 / 24.98 ms/token = 37.1 / 44.5 / 40.0 tok/s** (1.50× / 1.79× / 1.62× el simple de 40.3–40.6 ms/token); TTFT 8K **31.13 s** (+2.9 %), 32K **140.9 s** (+8.7 %: llenado de la caché MTP de la capa adicional) | Vectores de tokens completos y logits del prompt iguales a `--mtp 0` en 7 prompts, ambos ranks; TTFT simple sin cambios |
| Prefill por fragmentos exacto, núcleo lineal X2 (predeterminado) | prompts de benchmark de 1K / 8K / 32K | TTFT **3.78 / 27.93 / 120.26 s** (271 / 293 / 272 tok/s); misma ejecución con `STRIX_GLM_PF_EXACT_X=0`: 1K 3.84 s, 8K 29.59 s (**−5.6 %** a 8K) | logits iguales bit a bit a la ruta X=0 en ambos ranks; anclas de decode y oráculo especulativo sin cambios |
| Prefill por fragmentos exacto, núcleo lineal X2 + MoE auto (predeterminado) | prompts de benchmark de 1K / 8K / 32K | TTFT **3.74 / 26.85 / 113.73 s** (274 / 305 / 288 tok/s); misma ejecución con `STRIX_GLM_PF_EXACTMOE_V=3`: 1K 3.76 s, 8K 28.17 s (**−4.7 %** a 8K) | salidas iguales bit a bit a la ruta v3 en ambos ranks (las cargas útiles NaN FP32 internas solo pueden diferir en el caso de desbordamiento FP16); anclas de decode y oráculo especulativo sin cambios |
| Prefill por fragmentos exacto, núcleo MoE X3 y cubetas de filas (PR #183) | prompts de benchmark de 1K / 8K, fragmentos de 8,192 filas | TTFT **3.18 / 20.32 s**; misma ejecución con `STRIX_GLM_PF_EXACTMOE_V=7`: 1K 3.75 s, 8K 25.24 s (**−15 % / −19.5 %**) | dos pares por brazo; R1 bit a bit (mismas cadenas DOT2, reduce4 y orden de división) |
| Prefill por fragmentos exacto, cubetas de cola X3 + X3 denso + plan MoE en el dispositivo (PR #215) | prompts de benchmark de 8K / 32K, fragmentos de 8,192 filas | TTFT **17.77 / 76.59 s** (461 / 428 tok/s); misma ejecución con los predeterminados anteriores (PR #183): 20.22 / 86.66 s (**−12.1 % / −11.6 %**) | un par por brazo; los logits de cada rank son iguales a las anclas públicas con 8K y 32K en ambos brazos (mismas cadenas DOT2, reduce4 y orden de división) |
| Prefill por fragmentos exacto, kernels de atención: MLA scores v5 / o-bar v7 / GEMM absorb-out v2, indexer scores v3 / select v2 (medido con los predeterminados de PR #183, antes de PR #215) | prompts de benchmark de 8K / 32K, fragmentos de 8,192 filas | TTFT 32K **−6.8 %** (−7.2 s, media de ambos órdenes: 105.44 → 103.66 s con los kernels anteriores primero, 110.31 → 97.66 s con los nuevos primero); kernels de atención a 32K en el rango 0 **18.6 → 10.3 s**; 8K **25.23 → 23.62 s (−6.4 %)**, dos pares, sin la GEMM v2 | logits bit a bit iguales a los kernels anteriores en ambos rangos; mismo binario, kernels anteriores con sus interruptores; medido antes del núcleo MoE X3 (PR #183) |
| Prefill por fragmentos exacto, KDA scan v3 + MLA scores v6 (medido en f7e063b7e; código de prefill del par sin cambios hasta fb66457e4) | prompts de benchmark de 8K / 32K, fragmentos de 8,192 filas | TTFT 32K **−1.5 %** (−1.04 s, media de ambos órdenes: 68.81 → 67.26 s con los kernels nuevos primero, 68.71 → 68.17 s con los anteriores primero); kernels del rango 0 a 32K: KDA scan **2.18 → 1.43 s**, MLA scores **2.96 → 2.62 s**; 8K solo con KDA scan 16.63 → 16.34 s (−1.7 %) | logits bit a bit iguales a los kernels anteriores en ambos rangos; mismo binario, kernels anteriores con `STRIX_GLM_PF_KDA_SCAN=1` `STRIX_GLM_PF_SCORES=5`; el rango 0 corrió bajo el trazador de kernels en todos los brazos |
| Prefill por fragmentos exacto, KDA scan v5 (sobre los predeterminados de PR #254) | prompt de benchmark de 8K, fragmentos de 8,192 filas | TTFT **16.60 frente a 16.60 s** (media de 8 brazos, ambos órdenes: neutro); scan del rango 0 **0.355 → 0.340 s**; scan por capa 1.23–1.25 → 1.18–1.20 µs/fila (−3.7 %) | logits bit a bit iguales a v3 en ambos rangos; mismo binario, v3 con `STRIX_GLM_PF_KDA_SCAN=3`; el rango 0 corrió bajo el trazador de kernels; el cuarto brazo de cada par fue ~5 % más lento en todos los kernels en ambos órdenes |
| Prefill por fragmentos exacto, palancas del par: expansión mHC + norma fusionadas e intercambio de prefill por staging (predeterminados actuales) | prompts de benchmark de 1K / 8K, fragmentos de 8,192 filas, en caliente | TTFT **2.83 / 15.27 s** con todas las palancas del par activadas; intercambio por staging, ABBA: 1K 2.856 / 2.860 → 2.832 / 2.838 s, 8K 15.43 / 15.41 → 15.28 / 15.25 s (**−0.8 % / −0.9 %**, todos los brazos con staging más rápidos); expansión mHC + norma fusionadas, ABBA ×2: **−1.1 % / −1.3 %** | anclas de prefill exactas 16/16; logits bit a bit iguales a cada palanca desactivada (`STRIX_GLM_PF_STAGED=0`, `STRIX_GLM_PF_HC_FUSE=0`) |
| Norma HC fusionada en el decode (predeterminada) | decode C1 con MTP y lote R8, ABA ×2 | **−2.3 %** C1 MTP, **−3.1 %** R8 | tokens y R8 iguales a la referencia; `STRIX_GLM_HC_NORM=0` restaura el cierre sin fusionar |
| Sitio mHC del decode en un lanzamiento (predeterminado) | decode C1 `--mtp 0` y lote R8, ABBA con proceso nuevo | **−1.45 %** C1, R8 sin cambio | tokens y R8 iguales a la referencia en ambos rangos; `STRIX_GLM_HC_SITE=0` restaura los tres lanzamientos |
| Indicador del paso comprobado con la cabeza (predeterminado) | decode C1 `--mtp 0` y lote R8, ABBA con proceso nuevo | **−0.2 %** C1, R8 dentro del ruido | tokens y R8 iguales a la referencia en ambos rangos; `STRIX_GLM_STEP_FLAG=0` restaura la sincronización de host a mitad de paso |
| Último decode, todo predeterminado (#332 `ec76191f2`) | decode C1 `--mtp 0` y lote R8, dos ejecuciones | **39.00–39.03 ms/token** (25.6 tok/s, 57 % del techo de 44.7 tok/s); R8 **112.14–112.31 ms/paso** (71.3 tok/s agregados, calculado) | 24/24 exacto en ambos rangos |
| Último prefill exacto por chunks, todo predeterminado (#300 `32ec66bd3`) | prompts de benchmark de 1K / 8K / 32K, chunks de 8192 filas | TTFT **2.83 / 15.15 / 61.96 s** (541 / 529 tok/s con 8K / 32K); tiles del resto MoE 8K 15.35 → 15.15 s (−1.3 %, pares alternos), 32K −1.2 % en ambos órdenes de ejecución (62.58 → 61.96 s, −1.0 %, en uno; −1.4 % en el otro) | logits bit a bit en ambos rangos |
| Servido, `strix-glm5-serve --selftest 8` (predeterminados) | Flujos concurrentes C1 / C2 / C4 / C6 / C8, régimen estable (todos los flujos en decode); 8 prompts de chat cortos integrados con la plantilla de chat de GLM, 22–59 tokens de prompt (media ~33), hasta 128 tokens greedy cada uno, arranque con barrera, caché de prefijos desactivada | **C1 40.0 / C2 53.0 (G2 desactivado 37.8) / C4 59.9 (53.6) / C6 62.5 (62.4) / C8 69.5 (69.4) tok/s agregados**; por flujo 40.1 / 26.5 / 15.0 / 10.4 / 8.7; C1 sin MTP 25.30; CLI del motor `--batch` R8 69–71 | RESULT EXACT: los tokens de cada flujo son iguales a los del mismo prompt ejecutado solo (referencia C=1 simple) en todos los niveles, con G2 activado y desactivado |
| Servido, prefill por chunks con prioridad al decode (`--prefill-chunk 512`, predeterminado) | 4 prompts de ~1,830 tokens que llegan cada 16 rondas de decode a 4 flujos en curso, 128 tokens generados cada uno, caché desactivada | Mayor parada del decode **6.65 → 2.67 s (−60 %)** frente a `--prefill-chunk 0`; una petición sola se procesa entera | exacto |
| Caché de prefijos de prompt en el servidor (predeterminada, 4 GiB por rango) | Conversaciones de dos turnos, primer turno de ~4,100 tokens, el turno 2 añade 53 tokens; solo y en lote, frente a la misma petición tras vaciar la caché | Admisión a listo del turno 2 **8.57–8.98 s → 0.82–0.89 s (~10x)** para el prompt de 4,120 tokens (459–481 → 4,629–5,024 tok/s); restauración 9–11 ms; 4,067 de 4,120 tokens del prompt restaurados | tokens iguales a la repetición con la caché vacía (8/8; 16/16 con prompts cortos) en ambos rangos |
| Prefill por fragmentos exacto, MLA scores v7 (sobre los predeterminados de PR #279) | prompts de benchmark de 8K / 32K, fragmentos de 8,192 filas | kernel de scores del rango 0 **2.60 → 2.27 s** a 32K (−12 %) y **0.533 → 0.485 s** a 8K (−9 %); TTFT no más lento: 32K 65.68 → 65.54 s (−0.2 %, media de ambos órdenes: 65.574 → 65.524 con el nuevo primero, 65.778 → 65.549 con el anterior primero), 8K 16.23 → 16.12 s (−0.6 %, 4 brazos) | logits bit a bit iguales a v6 en ambos rangos; mismo binario, v6 con `STRIX_GLM_PF_SCORES=6`; el rango 0 corrió bajo el trazador de kernels; el cambio de TTFT está dentro de la dispersión de ~1 s entre ejecuciones a 32K |
| Prefill por fragmentos exacto, dense rows v2 (predeterminado; `STRIX_GLM_PF_DENSE_ROWS=1` restaura v1) | prompts de benchmark de 1K / 8K (1,024 / 8,192 tokens), brazos v2 / v1 intercalados | TTFT 8K **15.06 → 14.92 s** (−0.9 %, 544 → 549 tok/s), 1K en caliente **2.80 → 2.75 s** (−1.9 %, 366 → 372 tok/s); cada brazo v2 más rápido que cada brazo v1; kernels KDA f_b / g_b (128 → 4096) **1.19–1.21×** con 8,192 filas. Roofline: con 14.92 s para 8,192 tokens (549 tok/s), el prefill exacto del par funciona a cerca del 16 % de su mínimo de cómputo solo de lineales (31.8 GFLOP/token en 2 x 54 TF = 2.4 s); el límite que manda es la planificación exacta de los kernels, no el ancho de banda de memoria ni el cable: los lineales MoE y densos se ejecutan en teselas VALU FP32 para conservar la identidad bit a bit, y este cambio solo acorta la parte de filas densas de esa planificación. | logits y estado bit a bit iguales a v1 en ambos rangos (misma cadena FMA ascendente por salida); compuerta de dispositivo 80/80 bit a bit; las cadenas de 16,384 elementos de la ruta mHC heredada conservan el tile v1 |
| Prefill por fragmentos exacto, colapso de mezcla mHC y norma en un solo kernel (predeterminado; `STRIX_GLM_PF_MIXNORM=0` restablece los dos kernels) | prompts de benchmark de 8K / 32K (8,192 / 32,768 tokens), brazos activado / desactivado alternos | TTFT 8K **15.07 → 14.95 s** (−0.8 %, 544 → 548 tok/s), 32K **63.23 → 62.23 s** (−1.6 %, 518 → 527 tok/s, frente a la media de los brazos desactivados que lo rodean). Roofline: con 14.95 s para 8,192 tokens (548 tok/s) y 62.23 s para 32,768 tokens (527 tok/s), el prefill exacto del par funciona a cerca del 16 % / 15 % de su mínimo de cómputo solo de lineales (31.8 GFLOP/token en 2 x 54 TF = 2.4 s a 8K, 9.6 s a 32K); el límite que manda es la planificación exacta de los kernels, no el ancho de banda de memoria ni el cable: los lineales MoE y densos se ejecutan en teselas VALU FP32 para conservar la identidad bit a bit, y este cambio solo elimina un viaje de ida y vuelta a memoria por sitio de hiperconexión. | logits bit a bit iguales a las referencias en el par con 1K, 8K y 32K; gate de dispositivo bit a bit de 1 a 4096 filas y con valores especiales (solo pueden diferir las cargas de NaN propagados) |
| Núcleos lineales WMMA FAST del prefill (`glm-pf-wmma-x`, opcional `STRIX_GLM_PF_WMMA=1`) | Prompts de benchmark de 8K / 32K, fragmentos de 8,192 filas, proceso nuevo por brazo | TTFT **15.45 → 12.94 s (−16.3 %)** a 8K y **62.3 → 51.2 s (−17.8 %)** a 32K (media de ambos órdenes); núcleos lineales del rango 0 a 8K: MoE 5.15 → 3.42 s, X3 densos 2.61 → 1.71 s | FAST, no es bit a bit el prefill exacto: comprobación de paridad de calidad prerregistrada superada a 1K / 8K / 32K; desactivado (`STRIX_GLM_PF_WMMA=0` o sin definir, predeterminado) igual a las anclas de logits exactas en ambos rangos |
| Proyecciones KDA de pesos planos en WMMA, FAST (`glm-pf-kda-wmma-v1`, activo con `STRIX_GLM_PF_WMMA=1`; `STRIX_GLM_PF_KDA_WMMA=0` lo desactiva) | Prompts de benchmark de 8K / 32K, proceso nuevo por brazo, frente a FAST sin ello | Prefill 8K **9.25 → 9.05 s (−2.1 %)** (2 pares alternos), 32K **37.74 → 37.13 s (−1.6 %)** (2 ejecuciones sin / 3 con; se descarta una ejecución perturbada de cada brazo) | FAST, no bit a bit: teacher-forced 3 × 256 posiciones KL 0.0038 / 0.0004 / 0.0004 nats, top-1 98.0 / 100 / 100 %, cambio de NLL −0.006 / +0.001 / +0.002; desactivado conserva los bytes anteriores |
| Núcleo de atención MLA/DSA fusionado FAST (`glm-pf-attn-wmma`, activo con `STRIX_GLM_PF_WMMA=1`; `STRIX_GLM_PF_ATTN_WMMA=0` lo desactiva) | Prompts de benchmark de 8K / 32K, fragmentos de 8,192 filas, proceso nuevo por brazo, frente a FAST sin el núcleo | Prefill 8K **10.600 → 9.695 s (−8.5 %)** (2 pares alternos), 32K **44.30 → 40.26 s (−9.1 %)** (una serie off / on / off); banco de capa: scores + softmax + o-bar 2.6× / 3.2× más rápido en las posiciones de 8K / 32K | FAST, no es bit a bit: KL de logits del prefill 7.8e-4 nats a 8K, top-1 y greedy iguales en 8 pasos de decode; el modo exacto no cambia (logits iguales a las anclas en ambos rangos); comprobación teacher-forced con 3 prompts pendiente |
| Prefill por fragmentos exacto, expansión mHC y norma con dos filas por bloque (predeterminado; `STRIX_GLM_PF_HC_EXPAND_ROWS=1` restablece una fila por bloque) | prompt de benchmark de 8K (8,192 tokens), brazos activado / desactivado alternos, con las demás palancas exactas de prefill de esa compilación activadas | TTFT 8K **13.671 → 13.611 s** (−0.44 %, por encima de la dispersión de 0.024 s dentro de un brazo) | logits bit a bit iguales a las referencias en ambos rangos con 8K; gates de host y de dispositivo bit a bit frente al kernel de una fila |
| Prefill por fragmentos exacto / FAST, transformación de entrada gate/up del MoE en orden de tokens (predeterminado; `STRIX_GLM_PF_IN_TOKEN=0` restaura la transformación por tiles) | prompts de benchmark de 8K / 32K, brazos activado / desactivado en ambos órdenes, proceso nuevo por brazo | TTFT FAST 8K **10.55 → 10.21 s** (mediana de 4 pares); exacto 8K 13.195 → 12.868 s; FAST 32K 43.49 → 42.39 s (un par); exacto 32K: 56.32 → 53.41 s y 57.63 → 55.52 s en dos pares (desactivado primero, activado primero): −2.9 / −2.1 s, media −2.5 s (−4.5 %), ficheros completos de logits idénticos en ambos rangos (un par anterior mostró −5.5 s por un brazo desactivado lento; no se reprodujo). | digests de logits y estado idénticos en todos los brazos en ambos rangos; ficheros completos de logits idénticos en los brazos exactos |
| Concordancia R1b con teacher forcing | 32 prompts, 256 posiciones cada uno; chat, código, JSON, matemáticas, razonamiento, traducción | **8,126/8,192 = 99.19 %** top-1; KL media **~1.8e-3 nats** | `4dad4c19`; las ejecuciones libres divergen en **28/32** prompts entre 19 y 227 tokens |

La corrección del búfer R≥3 está verificada en el par real. La integración más reciente usa intercambio directo para los forwards
simples y MoE v3 exacto para el prefill; el oráculo especulativo también se supera con conmutación de intercambio drenado.
Las filas de prefill son ejecuciones únicas. Sustituyen al resultado anterior, solo sintético.

R1b cambia el orden de la suma FP32 y no es idéntico bit a bit a R1; qué identidad está más cerca de float64 a profundidad completa
sigue sin resolverse. Los grafos HIP **no están implementados**: el perfil más reciente (`41d8cfdc`) mantiene la GPU ocupada el **96.3 %** de cada forward (antes 80.8 %; 909 lanzamientos en lugar de 1,679) y deja solo **2.10 ms de inactividad por forward**
y un hueco recuperable calculado de **≤1.8 ms** (una cota, no una aceleración medida). El avance del host a través de
los límites de intercambio requiere captura segmentada; los kernels de dispositivo y el desfase entre ranks tienen prioridad.

<a id="glm-rtx-results"></a>

## Resultados medidos: una RTX PRO 6000

**GLM-5.3 Flash en una RTX PRO 6000 (borrador, opcional, Windows).** El tronco, las capas densas y los expertos
compartidos se quedan en la tarjeta; los 43 x 288 expertos enrutados los sirve la caché con compuerta en el dispositivo
de [tierstream](https://github.com/hyukudan/tierstream), y el prefill los lee a través de la misma caché, así que la
tarjeta guarda una sola copia de cada experto. El prefill y el decode son exactos (digests bit a bit de logits y
estado; estado del prefill igual con tiles de 2048 / 4096 / 8192 filas). Tarjeta completa, tile de 8192: TTFT **11.4 s** con 8K y
**30.5 s** con 32K (primera petición, media de dos cargas; 30.5 s con 32K frente a 43.7 s con tile de 2048, -30 %).
Con 32K el prefill está limitado por el cómputo de la GPU: la preparación de expertos (unos 128 GB de host a
dispositivo por prompt, 8-10 s de make-resident, unos 4 GB/s de media, muy por debajo de PCIe 5 x16) corre detrás
de los kernels con 0.0-0.2 s de GPU ociosa, así que el -30 % viene de menos decodificaciones de pesos de expertos
por prompt y filas de GEMM más largas por experto con el tile mayor, no de E/S; con 8K quedan expuestos 2-4 s de
preparación. (Exacto; la restauración de la residencia del decode se ejecuta ahora después del prefill, fuera del
tiempo hasta el primer token, y solo cuando sigue un decode); decode de **13.25 / 13.52 tok/s** en caliente
con 1K / 8K (3.63 / 4.09 en frío) con los kernels de decode actuales (bench de 24 tokens, medias ABBA de una carga).
Cuando se añadieron los kernels de decode de pocas filas, el decode midió 6.00 / 6.15 tok/s en caliente (3.75 / 3.70 en
frío) con ellos activados por defecto, frente a 2.43 / 2.36
tok/s con ellos desactivados en la misma carga del servicio (tarjeta completa; la RAM del host dejó 1,098 unidades de
expertos en el archivo de unidades, así que se incluyen los fallos de archivo por token; prueba de 24 tokens). Los
tokens, todos los digests de logits y el estado final de la sesión son iguales bit a bit con ellos activados y
desactivados, y la cualificación de 1K/8K pasa con ellos activados. Los kernels decodifican cada tesela de pesos
directamente en fragmentos de tensor cores y mantienen el orden de acumulación de los GEMM fijados; desactívelos con
`--decode-row-kernels 0` o `STRIX_GLM_RTX_ROW_KERNELS=0`.
El solapamiento del prefill está activado por defecto: mientras corren los kernels de una capa, los expertos de la
siguiente se hacen residentes. El estado del prefill, los tokens y los logits son idénticos bit a bit con él desactivado.
En comparaciones dentro de una misma ventana deja el TTFT en 0.56× (8K) y 0.66× (32K) del tiempo sin solapamiento con la
tarjeta completa. Se desactiva con `--prefill-overlap 0`.
La expulsión limpia en el prefill está activada por defecto: un residente de decode que el prefill desplaza sin
bloque fijado libre vuelve al fichero de unidades en lugar de sacar una unidad fijada. En la tarjeta completa reduce
el TTFT de 8K un 15 % / 12 % (primera / segunda petición), empata a 32K y lee un 60 % menos del fichero de unidades,
idéntico bit a bit. Se desactiva con `--prefill-clean-evict 0`.
Por defecto se asigna el mayor tile admitido hasta 8192, con crecimiento de activaciones + workspace
sobre 2048 <= 5% de la arena de expertos a 2048. Un tile mayor solo puede añadir unidades al fichero
si el plan de 2048 tiene <= 15% de las unidades enrutadas en fichero y el aumento es <= 5% de las
unidades enrutadas. Se admite 8192 en el intervalo medido con tarjeta completa (con 2048, ~1.5-4.6%
de las unidades enrutadas en fichero, ~2.4% más con 8192) y en planes dentro de estos límites si
caben el plan y el crecimiento; fuera se
conserva el veto anterior a unidades adicionales en fichero. Con tarjeta completa, 8192 frente a 2048
redujo el TTFT un 30% a 32K y un 9% / 5% a 8K, idéntico bit a bit. No establece el mejor tile a 8K:
en un par de cargas 4096 fue 1.3 / 2.0 s más rápido (primera / segunda petición), en el otro la
diferencia fue menor de 0.3 s. `--row-tile` explícito omite las reglas
automáticas de crecimiento y fichero (el plan debe caber), así como `row_tiles_tried`; los candidatos
automáticos indican los motivos de admisión y `file_units_over_2048`.
Las lecturas de fichero simultáneas usan por defecto auto según el régimen: se admite todo plan inicial
de tres niveles con cola 1 y al menos el 70 % de unidades enrutadas en fichero si staging >= 2 y caben
los lectores. Con aproximadamente el 76 % (24 GiB de VRAM + 32 GiB de RAM), auto nunca fue más lento
en las últimas medias de decode por celda; una celda anterior dio -3.4 %, atribuido a fases de lectura
de la unidad. Con aproximadamente el 61 % (48 GiB + 32 GiB), una noche anterior se observó un -32 %
en decode 1K en frío frente a la media con cola 1; las otras celdas dieron +3 % a 1K en caliente,
+7 % a 8K en frío y +1 % a 8K en caliente. Un conjunto posterior con el mismo presupuesto invirtió
el resultado de 1K en frío: auto +8.4 % agregado, todos los brazos auto más rápidos. El corte del
70 % sigue siendo un umbral empírico conservador; el 61 % conserva la cola 1.
Con tarjeta completa (aproximadamente el 1-4 % con tile 2048), el TTFT empató: 8K +0.6..+2 %, 32K igual;
se conserva la cola 1. Staging < 2 o lectores que no caben también vuelven a 1.
El `auto` explícito sigue siendo válido con cualquier proporción; `--tier-disk-queue 1` desactiva auto.
Con 24 GiB de VRAM + 32 GiB de
RAM del host (la mayoría de los expertos leídos del archivo de unidades en disco) también funciona de forma exacta: TTFT
**60.3 s** con 1K y **62.4 s** con 8K con el solapamiento del prefill (63.4 / 73.7 s sin él en la misma ventana); decode
de **0.67 tok/s** en caliente (0.63 en frío) con una lectura de fichero cada vez; con las lecturas de fichero
simultáneas por defecto con este presupuesto (auto, 76 % de los expertos en el fichero de unidades) el decode es de
**0.77 / 0.75 tok/s** en caliente / en frío con 1K (media de dos cargas, bench de 24 tokens). Con el prefetch de archivo en dos etapas opcional
(`--tier-landing-blocks 16`, tres unidades en franjas) el decode fue un 20-40 % más rápido que sin él en las mismas
ventanas, con salida idéntica (las repeticiones variaron entre un 15 y un 55 %). Compilación, archivo de unidades y
opciones: [guía de GLM RTX](../../../src/glm/rtxpf/README.md).

**Prefill en RTX hacia el par (FAST, desactivado por defecto).** `strix-glm5-serve --rtx-prefill HOST:PUERTO
--import-listen IP:PUERTO --import-peer IP:PUERTO --import-key FICHERO --import-model-sha SHA` (`--import-listen` en cada
rango; solo motores con su capa MTP) deja que el productor RTX haga el prefill de los prompts largos y entregue a cada
rango su estado. Ambos rangos preparan la entrega y votan (la vinculación autenticada y después ambos restaurados) antes
de ejecutar el último token del prompt; cualquier fallo antes de ese voto vuelve al prefill propio del par en los dos
rangos, y un fallo dentro de las operaciones colectivas del último token detiene el servidor (fatal). `--import-dsa-once`
(con `dsa_once` del productor) envía el estado DSA solo al rango 0, que lo retransmite al rango 1 por el enlace del par
(8K: de 480 a 316 MB en el enlace del productor, con tokens iguales a los de la entrega de la versión 1). Los prompts importados llevan la identidad FAST
`glm-pf-rtx-native-v1` (no son bit a bit el prefill propio del par; el `prefill_route` de cada respuesta la nombra).
`--import-gate` falla si algún brazo enrutado no importó de verdad (y una batería sin prompts también falla).
`--import-model-sha` es una atestación del operador: el receptor la compara con la cabecera de la entrega del
productor; no se calcula a partir de los tensores que cargó el par. Los ajustes de importación (receptor activo,
`--import-dsa-once`, versión del protocolo y SHA del modelo atestado) deben coincidir en todos los rangos: el hello
rechaza una discrepancia al arrancar. El bloque de control es la versión 6: un rango de esta compilación rechaza en el
hello a un rango de una compilación anterior.

Medido con la versión publicada (greedy, 128 tokens, caché desactivada, 1 GbE entre el PC con RTX y los nodos, productor
arrancado en cada ejecución): el tiempo hasta el primer token con la importación fue de 39.4 s a 1K y 45.6 s a 8K, frente a
2.83 s y 15.7 s con el prefill exacto propio del par (con MTP: 38.6 frente a 2.91 s y 44.5 frente a 16.3 s), por lo que la
ruta no es más rápida en esta configuración. Casi todo el tiempo importado es el prefill en la RTX (38-44 s): esa
ejecución arrancó el productor sin su caché de tierstream, de modo que cargaba capas de expertos desde los fragmentos
del modelo en cada petición (el README del productor muestra el arranque con caché); el coste de una importación en el par es de unos 0.4 s (cola
de la transferencia, restauración, prefill del último token y commit). Que compense depende del tiempo de prefill en la
RTX para prompts largos. Con el productor arrancado con su caché (primera petición, una ejecución, misma versión publicada, 1 GbE): 8K importado en 21.0 s
(prefill en la RTX 19.7 s) frente a 15.7 s con el prefill propio del par, todavía no más rápido.

## Todos los valores predeterminados incorporados de GLM

El registro de cambios de cada palanca de GLM activada por defecto, con su ganancia medida, su evidencia de exactitud y
su interruptor de desactivación, está en [ganancias medidas](../../measured-gains.es.md); el catálogo completo es
[docs/optimizations.md](../../optimizations.md#glm). Compilación, fichero de unidades y opciones de GLM RTX:
[guía de GLM RTX](../../../src/glm/rtxpf/README.md); notas del prefill nativo en RTX:
[docs/models/glm/rtx-prefill-native.md](../glm/rtx-prefill-native.md).
