# Cómo regenerar el submit final de la Primera Competencia

**Submit final entregado: `competencia/submissions/exp031_final_w67_md_k12000.csv`** (un solo archivo, 12.000 clientes, Public 103.21M; Línea de Muerte ≈ 100M en Public, Private ≈ 3 × Public).
Qué es: ranking que combina, por rank, **2/3 de M2** (multiclase CONTINUA/BAJA+1/BAJA+2 con todas las variables con lag1, lag2 y diferencias, 855 columnas, 3 configuraciones de Optuna × 10 semillas) y **1/3 del blend anterior** `exp024` (a su vez 50/50 entre el blend 017 + 010 y 8 modelos de la receta del profe). Pesos efectivos aproximados: M2 67%, receta 17%, 017 8%, 010 8%.

> Los términos técnicos (fold, M0/M1/M2, error estándar, PSI, etc.) están explicados en [`GLOSARIO.md`](GLOSARIO.md).

Todo parte del dataset original (`data/competencia_01.csv`, con `clase_ternaria`, que se construye con `clases/z101_target_sql.ipynb`; fuera de git). Python 3.14, dependencias en `requirements.txt`. Semillas propias en `competencia/src/config.py` (`SEMILLAS = 852583, 771227, 676057, 482687, 399221`; las demás se derivan de la primera con `RandomState(852583)`). Comandos desde la raíz del repo, con `source venv/bin/activate`.

## 1. Datos
`data/competencia_01.parquet.gzip` se genera con `clases/z701_drifting.ipynb` (o `src/data.py` cae al CSV si no existe). `config.CORREGIR_CCAJAS = True` pone `ccajas_depositos` en NA solo en 202105 (la columna viene rota: todo 0); los scripts de 008 en adelante y todos los del final lo activan solos (el default es False para que 001–007 sigan reproducibles).

## 2. Qué está versionado y qué no
- **Versionado:** código, hiperparámetros de los 6 trials de Optuna (`005_optuna/mejores_trials.json`, idénticos a los de la base SQLite, verificado), columnas M1 (`005_optuna/sel/top150_*.txt`), lista de 50 variables con historia (`003a_lag1_delta/variables_historia.txt`), lista de 142 variables (`008c_lags_150/variables_150.txt`), columnas excluidas por PSI (`031_final_todas_lags/drop_psi.txt`).
- **No versionado (se regenera):** `data/`, `artifacts/` (base de Optuna), `tmp/` de cada experimento (scores por cliente, modelos por semilla) y los CSV de `submissions/` (listas de `numero_de_cliente`; el repo es público). El registro de cada envío está en `submissions/REGISTRO.md`.

## 3. Del dataset al submit final (en este orden)
```bash
# 3.1 modelo 017: MIX6 multiclase + auxiliar de BAJA+1 + lag2 en M1, 30 semillas/config      (~4.5 h) -> 017_final/tmp/scores_202108_conlag2.csv
venv/bin/python competencia/experimentos/017_final/final.py --semillas 30 --k 11000 --lag2
# 3.2 modelo 010: MIX6 multiclase sin auxiliar ni lag2, 6 semillas/config                      (~40 min) -> 010_multiclase/tmp/proba_202108.csv
venv/bin/python competencia/experimentos/010_multiclase/final.py
# 3.3 receta del profe: multiclase sin undersampling, 512 hojas, 8 semillas                    (~40 min) -> 024_final_receta/tmp/scores_rec_202108.csv
venv/bin/python competencia/experimentos/024_final_receta/final_rec.py --semillas 8
# 3.4 M2: todas las variables con lags 1 y 2 y diferencias, 3 configs × 10 semillas            (~50 min) -> 031_final_todas_lags/tmp/scores_m2_md50-65-80_202108.csv
venv/bin/python competencia/experimentos/031_final_todas_lags/final_m2.py --semillas 10 --min_data 50,65,80
# 3.5 mezcla final por rank: 2/3 M2 + 1/3 (017 + 010 + receta), k=12000                       (segundos) -> submissions/exp031_final_w67_md_k12000.csv
venv/bin/python competencia/experimentos/031_final_todas_lags/blend_m2.py 0.6667 12000 scores_m2_md50-65-80_202108.csv
```
Cada modelo se guarda por (configuración, semilla) en `tmp/` y se reutiliza si se corta. Si el archivo de salida ya existe, `017_final/final.py` lo compara con lo regenerado (verificado: idéntico). `blend_m2.py` reconstruye en memoria la parte `exp024` a partir de los scores de 017, 010 y la receta (no necesita el CSV de `exp024`).
Tiempo total ≈ 7 h de cómputo en una máquina de 10 núcleos (estimaciones medidas en esta máquina; con la base de Optuna ya hecha).

## 4. Si se quiere repetir todo desde cero (≈ 15 h de cómputo)
1. `005_optuna/seleccion.py` → importancias y `sel/top150_*.txt` (selección con el train de cada fold; canaritos solo para excluir ruido).
2. `005_optuna/optuna_run.py --horas 8` → base SQLite en `artifacts/optuna/` (no versionada); `reevaluar.py` y `final.py` eligen y guardan `mejores_trials.json`. (Los scripts de validación de 013, 015 y 016 en adelante leen esa base vía `reevaluar.configs()`; los del final leen el JSON.)
3. Los cinco pasos del apartado 3.

## 5. Decisiones del modelo final y su evidencia (con sus límites)
Validación: todos los folds validan en 202105 (A) o 202106 (B, Bh, L, B2); 202106 es atípico por el aguinaldo. Los "pares positivos" son pares fold-semilla de **dos meses**, y el error estándar mide ruido de entrenamiento, no variación entre meses. L y B2 (los únicos con lag2 real en el train) tienen los targets solapados en 202107. **Escala:** las diferencias locales son de un mes completo; el Public es ~25%, así que hay que dividirlas por ~4 para compararlas (ruido por semilla en el Public ≈ 2.5M con 1 semilla/config, ≈ 1M con 6).

| Pieza | Evidencia local (experimento) | Confianza |
|---|---|---|
| LightGBM, ganancia por k envíos (no por umbral) | 001, z601; probabilidades no calibradas (005c) | alta |
| Undersampling de CONTINUA (r≈0.1) en los modelos M0/M1 de Optuna | +5 a +15M en 6/6 combinaciones en binario (007). En multiclase la receta **sin** undersampling no pierde (021): por eso la receta del profe va sin undersampling | media |
| Optuna (6 trials, M0/M1) | +20 a +40M sobre el baseline (005); ronda 2 sin mejora (005b); Optuna del multiclase con 150 columnas: meseta (012) | media (sobreajuste a 202105/06) |
| **Multiclase CONTINUA/BAJA+1/BAJA+2 con score P2/(1−P1)** | +5.5 a +9.3M sobre el binario en ensemble, 15/15 pares (010, 013); sumar P1 ayuda con poco train (018) | media-alta; el mecanismo ("propenso a irse") no está demostrado |
| **Todas las variables con lag1, lag2 y diferencias (M2, 855 columnas)** | +10.5M en B2, 8/8 pares (028); en ensemble +3.6 / +8.8M, 6/6 (030); control con la historia barajada: −31 a −73M (029); **confirmado en un mes limpio (202107, BAJA+1 proxy): +11.7M sobre el pool anterior, 5/5 pares, AUC +0.0025 (036)** | alta (dos meses distintos, uno sin solapamiento de targets) |
| 8 columnas lag2/d2 excluidas por PSI > 0.20 (`drop_psi.txt`) | el lag2 de 202108 apunta a junio (aguinaldo): `mpayroll_d2` PSI 1.0, etc. Decisión sin mirar el target; su costo no se midió | baja (precaución) |
| `min_data_in_leaf` 50/65/80 en M2 | meseta 50–80: +4 a +6M en L, +4M en B2 (032, 033); **no se confirma en 202107: −0.4 ± 1.7M (036)**; solo probado en top1 | baja (neutro; no hace daño) |
| Historia lag1/delta1/ratio1 de 50 variables (M1 y 017) | +4.5 a +12M (003a/b); en binario y con parámetros base, más variables no ayudaban (008c): **superado por 028** | media |
| lag2 sobre 50 variables en M1 (017) | multiclase +18.9 (L) / +5.4M (B2) (016); binario inconsistente (008b) | baja-media |
| Auxiliar de BAJA+1 con 202107 (017) | +0.9 a +1.5M (014), casi todo por usar un binario dedicado | baja (no distinguible de 0 para 202108) |
| Receta del profe (multiclase sin undersampling, 512 hojas, lr 0.005) como miembro | 021: +3M sobre Optuna en 150 columnas (en el borde de la grilla); 023: +0.6 a +3.5M con peso 1/7, 50/50 −0.9 / +3.5 / +7.3M en A/B/Bh; 3 semillas | baja-media (diversidad) |
| Promedio por rank en vez de probabilidades | +0.1 a +2.9M (009b, 013) | baja (efecto chico) |
| Blend 017 + 010 (cobertura del riesgo de lag2/auxiliar) | 019: cambia ~2% de los clientes respecto de cada uno | seguro, sin mejora medida |
| k = 12000 | meseta 10–12k (015); el pico depende de los positivos del mes (A 870 → 7.5k, B/Bh 1098 → 12–13k); ~1.150–1.200 positivos esperados en 202108 (018); curva en el Public 97.5 / 98.0 / **98.2** / 96.8 / 96.6M para k = 11.0k…13.0k (025) | media |
| Peso 2/3 M2 + 1/3 blend anterior | **juicio**, no validado: 030 mostró M2 +8.8M sobre el pool anterior en B2 y la mezcla 50/50 +5.9M; el resto aporta diversidad y cobertura | baja |

## 6. Descartado con evidencia (para el video a Michelina)
Plan de cierre de huecos 037 (COBERTURA.md, 0 de 9 variantes pasan BH): canarios sobre las 855 columnas (−122M), quitar 202103 (+1.9 ± 1.6M), deflactar montos (−1.4 ± 0.7M), M2 sin undersampling (+1.8 ± 2.9M), configuraciones M0 sobre las mismas columnas (+0.6 ± 0.5M), hojas de Random Forest (−12 a −47M).
Fechas y calendario (002), percentiles del mes agregados (003c), regla canarito estricta (004), k por probabilidades calibradas (005c), más variables con lag1 en binario (008c; el patrón con todas las variables y multiclase sí funciona, 028), lags de features derivadas, eventos de productos, agregados y comisiones normalizadas (011), receta del profe en **binario** con grilla truncada (009; corregido en 021), pesos por mes (014: −3.7M al mes viejo; 020: −2.5M al reciente), `extra_trees`, `path_smooth`, `min_gain_to_split` (022), binario con ambas bajas sobre las 855 columnas (034: −4 a −9M), rank del mes en [−1, 1] (027: −4 a −19M), tendencias por variable (035: +1 a +3M, no pasa la regla de > 2 ee en ambos folds), Optuna completo sobre M2 (no hay fold independiente para certificarlo; búsqueda dirigida en 032/033).

## 7. Public de referencia (25% de 202108)
94.2 (001) → 96.8 (005, 30 semillas) → 98.97 (008) → 99.99 (010, 6 semillas; 98.0 ± 2.5 con 1 semilla) → 99.14 (017) → 101.09 (019) → 101.15 (024) → **103.21 (031, final)**. Registro completo en `submissions/REGISTRO.md` y `LOG.md`. Los envíos de varios archivos fueron mediciones (ruido por semilla, curva de k), no candidatos.

## 8. Cautelas honestas
- Dos meses de validación (202105 y 202106) y tres envíos de ajuste fino sobre ellos: cada decisión nueva suma riesgo de sobreajuste a esos meses.
- Con ratio Private/Public ≈ 3, 103.2 equivale a ~309 en Private, un ~3% sobre el corte de ~300; el margen es del orden del ruido.
- Cada pieza agregada después del multiclase y de M2 aporta ≈ 1M o menos; la mayor parte de la ganancia está en tres decisiones: multiclase con score condicional, todas las variables con lags 1 y 2, y no tirar información de la historia.

## 9. Riesgos conocidos NO resueltos (revisión del 2026-10-09)
1. **Ola de salidas en clientes con préstamo y mora** (concept drift que el PSI no ve; la cátedra lo avisa en z701 para `mprestamos_personales`). En el grupo "préstamo personal y (tarjeta con status 6 o saldo total negativo)" (≈12.400 clientes, 7.5% de la población en 202108) la tasa de salida por mes de ausencia fue 0.22 → 0.29 → 0.28 → 0.51 → **1.3%** (ausentes en 202104 … 202108); su BAJA+2 pasó de 0.35–0.45% (202103–05) a **1.7%** en 202106 (17% de los positivos de ese mes con 7% de la población). Los que se van tienen saldo de cuenta corriente muy negativo, rentabilidad negativa y tarjetas en status 6 o faltantes: parecen cierres por mora, no bajas voluntarias. El final trata al grupo como promedio (8.2% del top-12000 contra 7.5% de la población). Si la ola persiste hasta 202110 el grupo merecería ~2× esa representación; si no, el modelo ya lo sobreestima algo. **No se puede validar** (no hay mes con BAJA+2 posterior a la ola).
2. **Columnas de calendario en los modelos** (036: neutras en 202107, −1.5 ± 1.8M al sacarlas; riesgo no corroborado): `Master_fultimo_cierre` y `Visa_fultimo_cierre` identifican el mes (valores 1, 2, 5, 0, 3, 6 de 202103 a 202108; AUC adversarial 1.0), están en M1 top150 y en las 855 columnas de M2, y 202108 trae un valor (6) que no existe en train (el árbol lo trata como el mayor visto, 5 = 202105). El modelo puede atribuir efectos del mes (p. ej. la ola de 202106) al identificador de mes, que no se transfiere. 002 (V4) dio −0.6 / −4.2M al sacarlas en el modelo binario de entonces; no se re-midió con M2. `Visa_mpagado` también está contaminada por el calendario (ceros 87% → 69% cuando el cierre cae tarde).
3. **El auxiliar de BAJA+1 con 202107 quedó solo en el 017 (≈ 8% del final)**: M2 (2/3) no lo usa, justo cuando 202107 contiene la ola. 014 midió +0.9 a +1.5M con un mes extra sin ola.
4. **Un solo mes de validación con evento** (202106: aguinaldo + ola) para casi todas las decisiones, y L/B2 con targets solapados. → Parcialmente resuelto: 036 validó en 202107 con BAJA+1 como proxy (mes limpio, sin solapamiento): las 855 columnas se confirman (+11.7M, 5/5); min_data, calendario y recencia no aportan. Sigue sin poder validarse el auxiliar de BAJA+1 en M2 ni la persistencia de la ola.
5. Calidad de datos (chequeo del 2026-10-09): sin duplicados (cliente, mes); salvo `ccajas_depositos` (corregida), las únicas variables con saltos de > 15 puntos en % de nulos o ceros son las de calendario (`*_fultimo_cierre`, `Visa_mpagado`).

