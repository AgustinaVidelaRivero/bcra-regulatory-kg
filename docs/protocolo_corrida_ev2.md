# Protocolo de corrida de EV2 (issue #4)

Este documento es la tercera pieza del sellado de EV2 según
`docs/diseno_ev2.md` §6: junto con las dos patas del set (eje de fidelidad y
eje de navegabilidad) y el manifest de sha256
(`data/experiment/exploracion/ev2_sellado/manifest_ev2.txt`), queda sellado en
un solo commit. Después de ese commit el set no se edita: toda desviación se
documenta como enmienda separada, nunca como ajuste silencioso (régimen de
válvula heredado de `docs/protocolo_u6.md` §8). Ninguna corrida de evaluación
ocurre antes del commit de sellado.

Los artefactos de las dos patas son de SOLO LECTURA para este protocolo: no
los edité ni los muevo; los referencio por ruta y sha256 (manifest).

---

## 1. Composición del set

Dos ejes ortogonales, cada uno con su métrica y su reporte, sin mezcla
(`docs/diseno_ev2.md` §2).

**Eje de FIDELIDAD** — 40 preguntas de generación ciega solo-PDFs
(`data/experiment/exploracion/ev2_fidelidad/preguntas_ev2_fidelidad.json`),
con gold en formato anclas + criterios (`docs/diseno_ev2.md` §5): ancla
normativa exacta (TO + punto) y 2–5 criterios verificables por pregunta,
**164 criterios en total, cada uno con cita textual verificada verbatim
contra el PDF (164/164)** según el registro de generación
(`data/experiment/exploracion/ev2_fidelidad/registro_generacion_ev2_fidelidad.md`
§6). Dosificación: ext 16 / cap 8 / cla 6 / ric 5 / pro 5.

Verificación de conteos:

```
python3 -c "import json; f=json.load(open('data/experiment/exploracion/ev2_fidelidad/preguntas_ev2_fidelidad.json')); ps=f['preguntas']; print(len(ps), sum(len(p['gold']['criterios']) for p in ps))"
# → 40 164
```

**Eje de NAVEGABILIDAD** — 64 samples aptos del pipeline de queries
sintéticas (`data/experiment/exploracion/sinteticas/out/preguntas_faseB.json`,
registros con `veredicto == "apto"`), cada uno con su par
literal/anti-léxica: **128 corridas de agente por grafo** (antes de descontar
ausencias del censo, §2). El gold es por anclas de provenance invariante
entre grafos, con resolución por-grafo y censo previo
(`docs/diseno_queries_sinteticas.md` §4). Los samples provienen del muestreo
estratificado de semilla `sinteticas-faseA-v2`
(`data/experiment/exploracion/sinteticas/out/samples.json`, clave
`config.semilla`); la calibración del validador quedó registrada en
`data/experiment/exploracion/sinteticas/out/calibracion_faseB.json`.

Verificación de conteos:

```
python3 -c "import json; b=json.load(open('data/experiment/exploracion/sinteticas/out/preguntas_faseB.json')); a=[r for r in b['registros'] if r['veredicto']=='apto']; print(len(a), len(a)*2)"
# → 64 128
```

Aptos por estrato (clave `resumen.aptos_por_estrato` del mismo archivo):
E-A 13 / E-B 17 / E-C 11 / E-D 12 / E-E 11.

**Cohortes** (`docs/diseno_ev2.md` §3) — se etiquetan en el reporte, JAMÁS se
promedian; el veredicto de mejora de v2 descansa exclusivamente en el núcleo
limpio:

- **Núcleo limpio**: las 40 preguntas de fidelidad (todas ancladas en
  territorio virgen fresco, 40/40 `unidad_disponible` contra el mapa de 5
  sets según el registro de generación §6) + el estrato uniforme E-E del eje
  sintético (11 samples aptos, 22 corridas).
- **Cohorte dirigida**: los estratos dirigidos E-A/E-B/E-C/E-D del eje
  sintético (53 samples aptos, 106 corridas). Los demás componentes de la
  cohorte dirigida que enumera el diseño §3 (las 25 preguntas U6 ya
  adjudicadas y los tests de respuesta conocida del backlog) no forman parte
  de las dos patas de este set: ya están sellados en sus propios artefactos y
  se incorporan al reporte desde allí.

## 2. Grafos a medir

Tres sistemas sobre el mismo set (`docs/diseno_ev2.md` §1):

1. **v2-reextraído** — cuando exista; su corrida (issue #9) está gateada por
   este sellado.
2. **v3 vigente** — `data/experiment/grafo_v2/reensamblado_v3/kg.json`,
   sha256 `26fac8b49f6c08c1aa364b47273d36958d831f240d4e6b4ee7700b6a0bff3571`
   (`shasum -a 256` sobre el archivo; coincide con `docs/tablero.md` §1).
3. **Baseline congelado** — run_3 (`data/experiment/run_3_ppf_core/kg.json`,
   sha256
   `12c226e22b8fdc8f46999cae7f1eb808930e71f5dfe803f3a4f637a88348c410`).

**Censo previo por grafo** para el eje sintético, antes de correr agente
alguno: verifico si el gold de cada caso existe en cada grafo. Gold ausente
en un grafo → el caso se registra como **ausencia de ese grafo** (dato que se
reporta en el eje de fidelidad) y se excluye de la métrica de navegabilidad
de ese grafo. Un grafo al que le falta el contenido no "falla navegación": le
falta el contenido (`docs/diseno_ev2.md` §2).

## 3. Régimen de repeticiones (pre-declarado, sin discreción)

Resuelve la pregunta abierta §8.b de `docs/diseno_ev2.md`. Base **N=1 para
todo**.

- **Eje de navegabilidad: N=1 definitivo.** La métrica es de retrieval
  (recall determinístico de gold en traza, visto/consultado), estable frente
  al no-determinismo documentado del proyecto, y el replay determinístico
  re-verifica cada corrida a partir de la traza persistida.
- **Eje de fidelidad: N=1 base**, con re-corrida **N=3** que se dispara SI Y
  SOLO SI el veredicto de la corrida base es **"parcial"** — trigger mecánico
  único, sin ninguna otra causal. Agregación de las 3 re-corridas: mayoría;
  un empate triple correcto/parcial/incorrecto resuelve a **parcial**
  (mediana categórica sobre el orden incorrecto < parcial < correcto).

La regla es idéntica para los tres grafos. Declaro el sesgo residual: re-correr
solo los no-correctos solo puede subir el nivel absoluto (sesgo alcista), pero
al ser la regla compartida por los tres grafos la COMPARACIÓN queda limpia; el
nivel absoluto se reporta con esta salvedad.

**Auditoría simétrica (laudada).** Para medir el sesgo en la otra dirección:
re-corrida N=3 sobre una muestra aleatoria del **10 % de los veredictos
"correcto"** de la corrida base de fidelidad de cada grafo, con semilla
declarada acá: **`auditoria-ev2-v1`** (muestreo por
`random.Random("auditoria-ev2-v1")` sobre los ids de los "correcto" de cada
grafo, ordenados por id). Mide la tasa de flip descendente
(correcto → parcial/incorrecto), se reporta junto al resultado principal y
replica dentro de EV2 el hallazgo de no-determinismo del proyecto.

## 4. Mecánica anti-cache de las repeticiones

Cada repetición corre bajo label `{run}_r{n}` con base de datos de caché
propia — patrón `rt_c6_n3`, ya validado en el proyecto — de modo que ninguna
repetición pueda servirse de la caché de otra. El reporte de toda corrida con
repeticiones verifica y declara **0 cross-hits de caché entre reps**.
`llm_cache.py` y el cuarteto hasheado de evaluación
(`data/experiment/evaluacion/{loader,harness,judge,llm_cache}.py`) quedan
INTOCADOS: la mecánica es por namespace/label y db, nunca por edición del
cuarteto.

## 5. Orden de ejecución y topes de costo

- **Orden aleatorizado con semilla declarada acá: `orden-ev2-v1`**
  (`random.Random("orden-ev2-v1").shuffle` sobre la lista de casos de la
  corrida, ordenada por id antes del shuffle). El orden NO se estructura por
  estrato ni por TO: si hubiera una deriva temporal (de la API, del modelo,
  de la caché), un orden agrupado la confundiría con efecto de estrato o de
  TO; el orden aleatorio la reparte.
- **Topes**: el tope de costo de cada corrida se declara en la autorización
  de la sesión API correspondiente, con estimación previa obligatoria antes
  de gastar (patrón del proyecto, regla f del circuito). Freno por
  proyección: si el gasto proyectado a partir del gasto parcial supera el
  tope, la corrida se detiene y se reporta antes de continuar.

## 6. Qué NO sella este protocolo

El **método de evaluación del eje de fidelidad** (juez calibrado con ejemplos
resueltos / adjudicación humana selectiva / mixto por muestreo — pregunta
abierta §8.c de `docs/diseno_ev2.md`) NO queda sellado acá: se sella en un
pre-registro propio, redactado **después de la corrida del agente y antes de
evaluar respuesta alguna**, para que la elección del método no pueda mirar
las respuestas que va a evaluar. Las **varas** — los 164 criterios
verificables por pregunta, con sus citas — SÍ quedan selladas en este commit:
el método que se laude evaluará contra ellas.
