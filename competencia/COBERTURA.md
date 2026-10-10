# Cobertura: qué proponen las fuentes y qué hicimos (auditoría del 2026-10-09)

Matriz armada desde los textos literales de las fuentes para que las omisiones sean visibles. **✅ probado** = hay experimento con medición; **◐ parcial** = se probó una versión limitada (se aclara cuál); **✗ no probado**; **— no aplica / conceptual**.
Límite: solo cubre lo que las fuentes mencionan. No puede mostrar ideas que ninguna fuente ni yo planteamos.

## 1. Mensaje del profe (competencia)
| Ítem | Estado | Dónde / qué falta |
|---|---|---|
| 1.1 `ccajas_depositos` = NA en 202105 | ✅ | 008a (sin efecto medible; aplicado por corrección) |
| 1.3 Feature engineering intra mes (listas en blanco en el mensaje) | ◐ | 003c, 003d, 011 (ratios y negocio entran; agregados/eventos no ayudan) |
| 1.4 Lags y delta lags de orden 1 **y 2** | ✅ (tarde) | 028–030, 036: leído primero como "50 variables"; la receta con todas las variables llegó recién en 028 |
| 1.5 Variables hojas de Random Forest | ✅ | **037f**: −46.5M (categóricas) / −12.1M (numéricas), 0/8 pares; diseño sin fuga (RF con 202103–04, LightGBM con 202105–06). Un solo diseño probado |
| 1.6 Canaritos asesinos | ✅ | 004 (319 columnas) y **037a (855 columnas: −122M, solo 22 columnas superan al canario máximo)**: sin ganancia en esta forma |
| 1.7 Sin undersampling | ✅ | 007/009 (binario, grilla truncada), 021 (multiclase, 150 columnas: no pierde), **037d (M2 855 columnas: r=1.0 +1.8 ± 2.9M, r=0.3 +2.9 ± 2.2M; sin ganancia detectable)** |
| 1.7 Métrica AUC, `max_bin`=31, `min_data_in_leaf`=0, ff 0.5, bynode 0.2, lr 0.005 | ✅ | 009, 021 (receta; componente del final) |
| 2.1 10+ modelos con hiperparámetros distintos, sin undersampling | ✅ | M2: 3 configs × 10 semillas con undersampling; **037e: sumar 3 configs M0 sobre las mismas columnas +0.6 ± 0.5M**; 037d: sin undersampling sin ganancia |
| 2.2 Promediar probabilidades | ✅ | 009b, 013: el rank rinde igual o algo mejor |
| 2.3 Cortes 10000, 10500, 11000… | ✅ | 015, 018, 025 |

## 2. Libro de la cátedra (secciones del temario)
| Sección | Estado | Dónde / qué falta |
|---|---|---|
| 13.2 Drifting de atributos | ✅ | 002, 008-C1 (adversarial), PSI de lag2 (031) |
| 13.3 Variables "rotas" → NA | ✅ | 008a; barrido de ceros y nulos por mes el 2026-10-09 |
| 13.4 Nulos (¿imputar o dejar que LightGBM los maneje?) | ◐ | NaN nativo en todo el trabajo; **no se comparó contra imputación** |
| 13.5 Outliers | ✗ | No tratados ni comparados (los árboles son robustos; no se midió) |
| 19 Controlando el False Discovery Rate | ✗ | No se aplicó ninguna corrección formal por comparaciones múltiples (decenas de pruebas sobre los mismos folds); solo la regla de > 2 ee |
| 20.2 Cambiando la clase | ✅ | 026, 034 (binario ambas bajas); multiclase 010/013 |
| 20.3 Variables manuales | ✅ | 003c, 003d, 011 |
| 20.4 Transformaciones (lineal, log, normalización) | — | Conceptual: invariantes para árboles. El rank dentro del mes (027) perjudica |
| 20.5–20.7 Históricas, lags y delta lags, tendencias | ✅ | 003a/b, 008, 016, 028–030, 035, 036 |
| 20.8 Medias móviles | ◐ | Solo como "cambio relativo a la media de 3 meses" (035); no como columna propia |
| 20.9 Ajuste por inflación | ✅ | Rank del mes (027: perjudica), comisiones normalizadas (011) y **deflactar por factor mensual (037c: −1.4 ± 0.7M)**; ojo: el factor mezcla inflación y aguinaldo |
| 20.10 Hojas de un Random Forest | ✅ | Ver 1.5 (037f) |
| 20.11 Reducción de dimensionalidad para acelerar | ✅ | 004 (top150) y 037a (canarios sobre M2: destruyen el modelo) |
| 24.1 Mejores períodos para entrenar | ✅ | 020 (pesos), B vs Bh (más meses ayuda), **037b (quitar 202103: +1.9 ± 1.6M, neutro)** |
| 24.2 Evitar cross validation | ✅ | Folds out-of-time en todo el trabajo |
| 24.3 Undersampling | ✅ | 007, 009, 021 |
| 25.2 Valores Shapley | ✗ | No hecho (interpretabilidad; el video a Miranda ya se entregó) |
| 26 Stacking de modelos | ✗ | No probado (riesgo de sobreajuste con dos meses) |
| 26.1–26.2 Semilleríos e hibridación | ✅ | 004b, 013, 031 (30 semillas por configuración; mezclas de configuraciones) |
| 27.2–27.3 Calibración en GB, "otra forma de cortar" | ✅ | 005c (probabilidades no calibradas), corte por cantidad |
| 28 Clustering con distancia de RF (como features de cohorte) | ✗ | G1 del informe de `research/`: no probado |

## 3. Comentarios de compañeros con Public > 100
Positivos = ambas bajas ✅ (026/034); `ccajas` en NA ✅; sin ajuste por inflación (igual que nosotros) ◐; lags 1 y 2 y diferencias de todas las variables ✅ (028); duda sobre `mprestamos_personales` ✅ (análisis del 2026-10-09: la variable es informativa, la relación con el target cambia en 202106); rankings en [−1, 1] ✅ (027, perjudica).

## 4. Informe `research/` (hipótesis del 05-oct)
B1 multiclase ✅ (la mayor mejora); C1 adversarial ✅; A3 k calibrado ✅ (falló); D1 forma de promediar ✅; B2 auxiliar BAJA+1 ✅ (+0.9–1.5M, **no está en M2**); A2 `scale_pos_weight` ✗; F1 SHAP ✗; F2 monotone constraints ✗; G1 cohortes ✗; E1 pseudo-labeling — (descartado a priori); H1 null importance ✗.

## 5. Mis propias propuestas que quedaron sin ejecutar
Canarios sobre las 855 columnas (propuesto como punto 3 de la revisión de sesgos y **no lanzado por omisión mía**: solo se aprobó el punto 1); auxiliar de BAJA+1 para M2 (no testeable en 202107; sin validación propia); reentrenar M2 sin calendario (036 mostró neutralidad: no corresponde); Optuna completo sobre M2 (sin fold independiente para certificar; lo reemplazó 032/033, y 036 no confirmó el efecto de `min_data`).

## 6. Resumen de huecos reales, por valor esperado y costo
| # | Hueco | Costo | Nota |
|---|---|---|---|
| 1 | Canarios sobre 855 columnas | ~30 min | Técnica de la cátedra; probablemente empate |
| 2 | Quitar el mes más viejo (202103) en el régimen de M2 | ~20 min con el proxy 202107 | Barato y no testeado |
| 3 | Deflactar montos por índice mensual | ~20 min con el proxy | Único pendiente del tema inflación |
| 4 | M2 con r=1 (sin undersampling) | ~1–2 h | El profe lo pidió explícitamente |
| 5 | Hojas de Random Forest | ~2–3 h | Única técnica enseñada y no probada; riesgo de fuga |
| 6 | Configuraciones M0 sobre las columnas de M2 (diversidad) | ~1 h | Mejora esperada chica |
| 7 | Auxiliar de BAJA+1 en M2 | ~1.5 h | Sin forma de validarlo |

---

# PLAN DE CIERRE DE HUECOS (fijado antes de correr nada; 2026-10-09)

Las reglas de esta sección se escribieron **antes** de ver ningún resultado de los experimentos nuevos. No se modifican después; si una regla resulta mal planteada, se anota como tal y se informa el resultado igual.

## 7. Protocolo común (vale para todos los experimentos de este plan)
| Aspecto | Decisión |
|---|---|
| **Validación primaria** | La del 036: train 202103–06, valid 202107, tarea BAJA+1 (sin solapamiento, mes sin aguinaldo, con la ola). Mismo harness (`036_validacion_202107/run.py`): binario, hiperparámetros de M1 top1, undersampling r=0.0986 salvo que el experimento lo cambie, ganancia media sobre k=8000..15000 + AUC |
| **Semillas** | 8 pareadas (`SEMILLAS_20[2:10]`; las del 036 son 5, así que la variante base se recalcula con las 8). Excepción: B1 (costoso) usa 5 |
| **Línea base** | V2 del 036: las 855 columnas (M2), `min_data_in_leaf` 27, sin cambios. Todas las variantes se comparan contra esa línea base, pareadas por semilla |
| **Una sola cosa por variante** | Cada variante cambia un solo factor respecto de la base |
| **Tamaño mínimo que importa** | Δ ≥ **+3M** en la escala del proxy (≈ +0.5% de la ganancia; en el Public equivaldría a ~+0.75M, que es lo mínimo que justifica el riesgo de reentrenar) |
| **Significancia (FDR, libro §19)** | Test t pareado unilateral por variante (gl = 7). Se aplica **Benjamini–Hochberg con q = 0.10 sobre todos los tests del lote** (≈ 8 variantes). Una variante "pasa" solo si es significativa tras BH **y** Δ ≥ +3M |
| **Confirmación en BAJA+2** | Toda variante que pase se confirma en L y B2 con el multiclase (4 semillas pareadas, `028`/`030`). Se adopta solo si Δ ≥ −1 ee en ambos folds (no empeora) |
| **Qué cuenta como "no adoptar"** | Si no pasa, **no se adopta aunque dé positivo**. Se documenta como "técnica probada, sin ganancia" (útil para el video a Michelina). No se prueban variantes adicionales para "rescatarla" |
| **Registro** | Cada experimento: carpeta `NNN_nombre/` con README, fila en `LOG.md`, y actualización de `COBERTURA.md` (✗ → ✅/◐ con el número) |

## 8. Experimentos, en orden, con su condición de adopción
Numeración desde el 037. Cada uno corre sobre el mismo harness; los tres primeros comparten una sola corrida de línea base.

| # | Experimento (cierra el hueco de) | Diseño exacto | Se adopta si… | Qué se reentrena si se adopta |
|---|---|---|---|---|
| **037a** | Canarios sobre 855 columnas (profe 1.6) | 20 columnas U(0,1) + las 855; importancia gain media de 3 modelos entrenados **solo con 202103–06**; variantes: (i) conservar columnas con gain > máximo canario; (ii) conservar las > percentil 90 de los canarios | Δ ≥ +3M tras BH **y** confirma en L/B2. *Variante de velocidad:* si queda dentro de ±1 ee y quita > 50% de columnas **no se adopta** (el ahorro de cómputo no justifica cambiar el modelo final) | M2 con la lista de columnas podada |
| **037b** | Quitar el mes más viejo, 202103 (libro 24.1) | Igual a la base pero entrenando con 202104–06 | Δ ≥ +3M tras BH y confirma en L/B2 (en L/B2 el train ya excluye 202103: la confirmación mira que no pierda) | M2 entrenado con 202104–06 (cambia el auxiliar y el resto del blend: se evalúa como "final con 202104–06", ver §9) |
| **037c** | Deflactar montos (libro 20.9) | Factor mensual `f_m` = mediana (entre variables de monto) de [mediana de la variable entre clientes con valor > 0 en el mes m / la misma en 202103], calculado sin el target. Se divide cada monto por `f_m`, cada `_lag1` por `f_{m−1}`, cada `_lag2` por `f_{m−2}`; diferencias y ratios se recalculan; las columnas `n_*` y `r_*` con montos se deflactan igual (lista exacta en el README) | Δ ≥ +3M tras BH y confirma en L/B2 | M2 con montos deflactados (el factor de 202108 se calcula con sus propias features, sin target) |
| **037d** | M2 sin undersampling (profe 1.7) | r ∈ {0.0986 (base), 0.3, 1.0}; mismos hiperparámetros (**confusión conocida**: con más filas, `min_data_in_leaf` pesa relativamente menos; se documenta pero no se retunea); 5 semillas | r=1.0 (o 0.3) con Δ ≥ +3M tras BH y confirma en L/B2 | M2 con ese r (entrenamiento más lento: ~10× filas; ~6–8 h para 30 modelos → en ese caso se reduce a 3 semillas por configuración y se documenta) |
| **037e** | Diversidad con configuraciones M0 sobre las columnas de M2 (profe 2.1) | Ensemble de 3 configuraciones M1 vs 6 (M1 + M0), mismas columnas (855), rank medio, 8 semillas | Δ ≥ +3M tras BH y confirma en L/B2 | 30 modelos más de M2 con parámetros M0 |
| **037f** | Hojas de Random Forest (profe 1.5, libro 20.10) | Sin fuga: el RF (sklearn, 100 árboles, profundidad ≤ 8, `min_samples_leaf` 200) se entrena con **202103–04** y sus índices de hoja se agregan como columnas; LightGBM entrena con **202105–06** (con y sin las hojas, mismos filas) y se valida en 202107. 8 semillas | Δ ≥ +3M tras BH y confirma en L/B2 **con el mismo esquema temporal** | Esquema de dos etapas completo (RF con 202103–04 → M2 con 202105–06): cambia el régimen de entrenamiento; se evalúa como "otro modelo" para mezclar, no como reemplazo |

## 9. Si algo se adopta: protocolo de reentrenamiento del final
1. **Solo después de terminar todo el lote** (no se reentrena por experimento): se combinan **todas** las variantes que pasaron, pero primero se verifica en una corrida de 036 que la combinación **no** pierde frente a cada una por separado (interacciones).
2. Se reentrena M2 (3 configuraciones × 10 semillas, ~50 min; más si 037d) con la combinación y se arma el blend con el mismo esquema (2/3 M2 + 1/3 resto), k=12000.
3. Se compara el top-12000 nuevo con `exp031`: si el solapamiento es > 97%, el cambio es chico y **no** se reenvía (el riesgo de un nuevo submit no se justifica); si es < 97%, se evalúa.
4. Para enviar al bot: un solo archivo. Regla del Public: se mantiene el nuevo salvo caída > ~3M respecto de 103.21 (señal de rotura); no se elige por diferencias menores.
5. `exp031` queda como respaldo; el último submit antes del cierre debe ser un único archivo.

## 10. Lo que decidimos NO hacer, y por qué
| Idea | Decisión | Razón |
|---|---|---|
| Optuna completo sobre M2 | No | Sin fold independiente para certificar; 032/033 lo reemplazó y 036 no confirmó el efecto de `min_data` |
| Auxiliar de BAJA+1 en M2 | No | No se puede validar (el valid del proxy es 202107, que el auxiliar usa para entrenar); el único aporte medido es ~+1M con 150 columnas |
| Sacar columnas de calendario | No | 036: −1.5 ± 1.8M |
| Peso mayor a 202106 | No | 036: −1.1 ± 1.4M; 020: −2.5M |
| Stacking con meta-modelo | No | Con dos meses de validación es el método más propenso a sobreajustar |
| Shapley / SHAP | No (para el modelo) | Interpretabilidad; el video a Miranda ya se entregó. Puede hacerse para el video a Michelina sin tocar el final |
| Tratamiento de outliers, imputación vs NaN | No | Los árboles de LightGBM son robustos a ambos; la cátedra lo plantea como pregunta, y el costo de medirlo no se justifica con el tiempo que queda |
| Features de cohorte con distancia de RF (clustering) | No | Costoso y sin forma de validarlo en el proxy; queda para la Última Competencia |
| Pseudo-labeling de 202107/202108 | No | Transductivo y difícil de defender en el examen oral |
| Monotone constraints, null importance, `scale_pos_weight` | No | Ganancia esperada baja; no hay hipótesis específica |

## 11. Calendario y límites
| Hito | Fecha límite (hora local) | Qué pasa si no se llega |
|---|---|---|
| Terminar los experimentos 037a–f y la tabla BH | sáb 10-oct, 18:00 | Lo que no esté listo se documenta como "no probado por tiempo" |
| Decidir qué se adopta | sáb 10-oct, 19:00 | — |
| Reentrenar el final (si hay algo adoptado) | sáb 10-oct, 20:00 → ~00:00 | Si no termina antes del domingo 10:00, se descarta y queda `exp031` |
| Enviar el submit | dom 11-oct, 12:00 | Pasada esa hora no se envía nada nuevo |
| Ventana de seguridad | dom 11-oct, 12:00–23:59 | Solo verificar que el último submit del bot sea un único archivo |
**Tiempo total estimado de cómputo:** 037a 30 min + 037b 20 + 037c 40 (incluye armar el factor) + 037d 65 + 037e 40 + 037f 120 ≈ **5.5 h**, más 1–2 h si se adopta algo. Mis estimaciones de tiempo fallaron por hasta 2× varias veces: el cronograma deja ~10 h de margen.

## 12. Riesgos del propio plan
- Cada experimento nuevo sobre los mismos datos suma riesgo de sobreajuste: por eso BH y el umbral de +3M.
- El proxy es BAJA+1, no BAJA+2: la confirmación en L/B2 es obligatoria, pero esos folds tienen los targets solapados. Una variante que solo pase en uno de los dos entornos **no** se adopta.
- Ninguno de estos experimentos puede resolver si la ola de salidas de clientes con préstamo y mora persiste en 202110.

---

# RESULTADO DEL PLAN DE CIERRE DE HUECOS (2026-10-09)
Familia de **9 pruebas** (8 planeadas + 1 exploratoria posterior), Benjamini–Hochberg q = 0.10, mínimo +3M, proxy 202107 con 5–8 semillas pareadas (`037_hojas_rf/bh_final.py`, `bh_final.csv`):

| Prueba | Δ (M) | ee | Pares | p unilateral | ¿Pasa? |
|---|---|---|---|---|---|
| 037d r = 0.3 (más negativos) | +2.9 | 2.2 | 3/5 | 0.13 | No |
| 037b sin 202103 | +1.9 | 1.6 | 5/8 | 0.14 | No |
| 037e + configuraciones M0 | +0.6 | 0.5 | 4/8 | 0.16 | No |
| 037d r = 1.0 (sin undersampling) | +1.8 | 2.9 | 3/5 | 0.29 | No |
| 037c deflactado | −1.4 | 0.7 | 2/8 | 0.94 | No |
| 037a canarios > máximo (22 columnas) | −122.2 | 3.1 | 0/8 | 1.00 | No |
| 037a canarios > p90 (30 columnas) | −122.4 | 3.1 | 0/8 | 1.00 | No |
| 037f hojas de RF categóricas | −46.5 | 1.5 | 0/8 | 1.00 | No |
| 037f hojas de RF numéricas (posterior) | −12.1 | 1.3 | 0/8 | 1.00 | No |

**Ninguna variante pasa. El final (`exp031_final_w67_md_k12000.csv`) no cambia.** Lo que quedó en ✅ en las secciones 1 y 2 de este documento es "probado, sin ganancia en esta forma". Huecos que **siguen sin probarse** (los más caros o sin forma de validarse): stacking, Shapley sobre el modelo, outliers e imputación, features de cohorte con la distancia de RF, y el auxiliar de BAJA+1 sobre M2.

