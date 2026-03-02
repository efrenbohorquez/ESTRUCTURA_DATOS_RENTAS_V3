"""
build_09_comparacion.py
========================
Genera notebooks/09_Comparacion_Modelos.ipynb — Evaluacion Comparativa
Doctoral de los cinco modelos de pronostico de Rentas Cedidas.

Arquitectura:
  Fase I   — Carga estandarizada de pronosticos OOS
  Fase II  — Triada de metricas (MAPE, RMSE, MAE) mensual, bimestral, trimestral
  Fase III — Electrocardiograma Fiscal (overlay real vs predichos)
  Fase IV  — Analisis de Residuos y Ljung-Box
  Fase V   — Diagnostico de Limitaciones Criticas (LSTM, XGBoost)
  Fase VI  — Matriz Comparativa Final y Recomendacion

Ejecutar:
    python scripts/build_09_comparacion.py
    python -m jupyter nbconvert --to notebook --execute --inplace \
        --ExecutePreprocessor.timeout=600 notebooks/09_Comparacion_Modelos.ipynb
"""

import nbformat as nbf
from pathlib import Path

nb = nbf.v4.new_notebook()
nb.metadata.update({
    'kernelspec': {'display_name': 'Python 3', 'language': 'python', 'name': 'python3'},
    'language_info': {'name': 'python', 'version': '3.11.0'},
})

def md(source):
    nb.cells.append(nbf.v4.new_markdown_cell(source))

def code(source):
    nb.cells.append(nbf.v4.new_code_cell(source))


# ════════════════════════════════════════════════════════════════
# CELDA 1 — MARKDOWN: Encabezado
# ════════════════════════════════════════════════════════════════
md(r"""# 09 — Evaluacion Comparativa Doctoral de Modelos de Pronostico

**Sistema de Analisis y Pronostico de Rentas Cedidas** | ADRES — Colombia

---

## Objetivo

Realizar una evaluacion comparativa rigurosa de los cinco modelos desarrollados
(SARIMA, SARIMAX, Prophet, XGBoost y LSTM) para identificar el **modelo optimo**
para la operacion mensual y el balance de caja trimestral de la ADRES.

## Arquitectura Analitica

| Fase | Contenido | Metodo |
|------|-----------|--------|
| **I** | Carga estandarizada de pronosticos OOS | Backtesting Oct–Dic 2025 |
| **II** | Triada de metricas por temporalidad | MAPE, RMSE, MAE (mensual, bimestral, trimestral) |
| **III** | Electrocardiograma Fiscal | Overlay real vs predicho (5 modelos) |
| **IV** | Analisis de residuos | Ljung-Box, Shapiro-Wilk, homocedasticidad |
| **V** | Diagnostico de limitaciones | LSTM (n<48), XGBoost (picos ERP Oracle) |
| **VI** | Matriz comparativa final | Modelo ganador + recomendacion 2026 |

### Principios Metodologicos

1. **Set de prueba inamovible**: Trimestre Oct–Dic 2025 como periodo de
   validacion fuera de la muestra (out-of-sample) para todos los modelos.

2. **Condicion exogena**: Los modelos SARIMAX y XGBoost incluyen IPC como
   variable obligatoria para descontar el efecto inflacionario.

3. **Innegociabilidad del IPC**: La comparacion se hace sobre series que ya
   limpiaron la inflacion, demostrando que los modelos predicen el consumo
   real y no solo la inercia de precios.

---
""")


# ════════════════════════════════════════════════════════════════
# CELDA 2 — CODE: Importaciones y Configuracion
# ════════════════════════════════════════════════════════════════
code(r"""# ══════════════════════════════════════════════════════════════
# IMPORTACIONES Y CONFIGURACION
# ══════════════════════════════════════════════════════════════
import numpy as np
import pandas as pd
import matplotlib.pyplot as plt
import matplotlib.dates as mdates
import matplotlib.ticker as mticker
from scipy import stats
from sklearn.metrics import (mean_absolute_error,
                             mean_absolute_percentage_error,
                             mean_squared_error)

# Configuracion del proyecto
%run 00_config.py

# Statsmodels para diagnostico
from statsmodels.stats.diagnostic import acorr_ljungbox

print(f"\n{'='*70}")
print(f"EVALUACION COMPARATIVA DOCTORAL DE MODELOS")
print(f"{'='*70}")
print(f"  Periodo prueba OOS:  {TEST_START} -> {VALIDATION_END}")
print(f"  Horizonte:           {HORIZONTE_TEST} meses (Oct-Dic 2025)")
print(f"  Modelos evaluados:   SARIMA, SARIMAX, Prophet, XGBoost, LSTM")
""")


# ════════════════════════════════════════════════════════════════
# CELDA 3 — MARKDOWN: Fase I
# ════════════════════════════════════════════════════════════════
md(r"""---

## Fase I — Carga Estandarizada de Pronosticos OOS

### Protocolo de Backtesting

Todos los modelos fueron entrenados con la misma ventana:
- **Entrenamiento:** Oct 2021 – Sep 2025 (48 meses)
- **Prueba OOS:** Oct – Dic 2025 (3 meses) contra datos **reales observados**

La estandarizacion garantiza que la comparacion sea justa:
cada modelo fue evaluado frente a exactamente los mismos tres
valores reales de recaudo, sin *data leakage* ni contaminacion temporal.
""")


# ════════════════════════════════════════════════════════════════
# CELDA 4 — CODE: Fase I — Carga de pronosticos
# ════════════════════════════════════════════════════════════════
code(r"""# ══════════════════════════════════════════════════════════════
# FASE I — CARGA ESTANDARIZADA DE PRONOSTICOS OOS
# ══════════════════════════════════════════════════════════════

# -- Definicion de modelos y archivos --
MODELOS_CONFIG = {
    'SARIMA':  {'archivo': 'sarima_forecast.csv',  'col_pred': 'Pronostico_SARIMA',  'color': COLORES_MODELOS['sarima']},
    'SARIMAX': {'archivo': 'sarimax_forecast.csv', 'col_pred': 'Pronostico_SARIMAX', 'color': COLORES_MODELOS['sarimax']},
    'Prophet': {'archivo': 'prophet_forecast.csv', 'col_pred': 'Pronostico_Prophet', 'color': COLORES_MODELOS['prophet']},
    'XGBoost': {'archivo': 'xgboost_forecast.csv', 'col_pred': 'Pronostico_XGBoost', 'color': COLORES_MODELOS['xgboost']},
    'LSTM':    {'archivo': 'lstm_forecast.csv',    'col_pred': 'Pronostico_LSTM',    'color': COLORES_MODELOS['lstm']},
}

# -- Cargar serie mensual completa para contexto --
df_serie = pd.read_csv(DATA_PROCESSED / 'serie_mensual.csv',
                       parse_dates=['Fecha'], index_col='Fecha')
df_serie.index.freq = 'MS'

# -- Cargar y estandarizar pronosticos --
pronosticos = {}
real_confirmado = None

for nombre, cfg in MODELOS_CONFIG.items():
    ruta = OUTPUTS_FORECASTS / cfg['archivo']
    if not ruta.exists():
        print(f"  ADVERTENCIA: {cfg['archivo']} no encontrado — se omite {nombre}")
        continue

    df_m = pd.read_csv(ruta, parse_dates=['Fecha'])
    df_m = df_m.set_index('Fecha')

    # Detectar columna de prediccion automaticamente
    col_pred = cfg['col_pred']
    if col_pred not in df_m.columns:
        # Buscar alternativas
        cols_pred = [c for c in df_m.columns if 'Pronostico' in c or 'Pred' in c or 'Forecast' in c]
        if cols_pred:
            col_pred = cols_pred[0]
        else:
            print(f"  ADVERTENCIA: No se encontro columna de prediccion en {cfg['archivo']}")
            continue

    pronosticos[nombre] = {
        'predicho': df_m[col_pred].values,
        'color': cfg['color'],
    }

    # Confirmar valores reales (deben coincidir entre todos los archivos)
    if real_confirmado is None and 'Real' in df_m.columns:
        real_confirmado = df_m['Real'].values
        fechas_oos = df_m.index

print(f"{'='*70}")
print(f"CARGA DE PRONOSTICOS COMPLETADA")
print(f"{'='*70}")
print(f"  Modelos cargados:   {len(pronosticos)}")
print(f"  Meses OOS:          {len(real_confirmado)}")
print(f"  Fechas OOS:         {fechas_oos[0].strftime('%Y-%m')} -> {fechas_oos[-1].strftime('%Y-%m')}")

# -- Tabla resumen de datos cargados --
print(f"\n{'Modelo':<12} {'Oct 2025':>15} {'Nov 2025':>15} {'Dic 2025':>15}")
print(f"{'_'*58}")
print(f"  {'REAL':<10}", end='')
for v in real_confirmado:
    print(f" ${v/1e9:>12.1f}MM", end='')
print()
for nombre, datos in pronosticos.items():
    print(f"  {nombre:<10}", end='')
    for v in datos['predicho']:
        print(f" ${v/1e9:>12.1f}MM", end='')
    print()
""")


# ════════════════════════════════════════════════════════════════
# CELDA 5 — MARKDOWN: Fase II
# ════════════════════════════════════════════════════════════════
md(r"""---

## Fase II — Triada de Metricas por Temporalidad

### Metricas de Evaluacion

Se calculan tres metricas complementarias que capturan diferentes dimensiones
del error de pronostico:

| Metrica | Formula | Utilidad para ADRES |
|---------|---------|---------------------|
| **MAPE** | $\frac{1}{n}\sum\frac{\|y_i - \hat{y}_i\|}{y_i}$ | Comunicar precision porcentual a la alta gerencia |
| **RMSE** | $\sqrt{\frac{1}{n}\sum(y_i - \hat{y}_i)^2}$ | Penalizar errores grandes en picos estacionales (Ene/Jul) |
| **MAE** | $\frac{1}{n}\sum\|y_i - \hat{y}_i\|$ | Cuantificar el desvio promedio en pesos colombianos |

### Temporalidades

La evaluacion se realiza en tres escalas temporales:

1. **Mensual**: Precision para el monitoreo de recaudo mes vencido
   (operacion diaria de la ADRES).
2. **Bimestral**: Oct–Nov 2025 — ventana de corte financiero intermedio.
3. **Trimestral**: Oct–Dic 2025 — periodo completo del balance de caja.

> **Razonamiento:** Aunque el modelo trimestral suele exhibir MAPE mas bajo
> (por agregar una serie mas suave), el modelo **mensual** es el que tiene
> "alma" y logica de negocio para la ADRES, ya que permite monitorear el
> recaudo mes vencido.
""")


# ════════════════════════════════════════════════════════════════
# CELDA 6 — CODE: Fase II — Triada de metricas
# ════════════════════════════════════════════════════════════════
code(r"""# ══════════════════════════════════════════════════════════════
# FASE II — TRIADA DE METRICAS POR TEMPORALIDAD
# ══════════════════════════════════════════════════════════════

def calcular_metricas(real, predicho, label=''):
    # Calcula MAPE, RMSE y MAE entre arrays real y predicho
    mape = mean_absolute_percentage_error(real, predicho) * 100
    rmse = np.sqrt(mean_squared_error(real, predicho))
    mae  = mean_absolute_error(real, predicho)
    return {'MAPE_%': round(mape, 2),
            'RMSE_MM': round(rmse / 1e9, 2),
            'MAE_MM': round(mae / 1e9, 2)}

# -- Calcular metricas para cada temporalidad --
temporalidades = {
    'Mensual':    (slice(None), 'Los 3 meses individuales (Oct, Nov, Dic)'),
    'Bimestral':  (slice(0, 2), 'Acumulado Oct-Nov 2025'),
    'Trimestral': (slice(None), 'Acumulado Oct-Dic 2025 (Balance de Caja)'),
}

resultados_completos = []

for nombre_modelo, datos_modelo in pronosticos.items():
    pred = datos_modelo['predicho']

    # -- Mensual: promedio de metricas de los 3 meses individuales --
    metricas_m = calcular_metricas(real_confirmado, pred)
    resultados_completos.append({
        'Modelo': nombre_modelo,
        'Temporalidad': 'Mensual',
        **metricas_m
    })

    # -- Bimestral: Acumulado Oct-Nov --
    real_bim = np.array([real_confirmado[:2].sum()])
    pred_bim = np.array([pred[:2].sum()])
    metricas_b = calcular_metricas(real_bim, pred_bim)
    resultados_completos.append({
        'Modelo': nombre_modelo,
        'Temporalidad': 'Bimestral',
        **metricas_b
    })

    # -- Trimestral: Acumulado Oct-Dic --
    real_tri = np.array([real_confirmado.sum()])
    pred_tri = np.array([pred.sum()])
    metricas_t = calcular_metricas(real_tri, pred_tri)
    resultados_completos.append({
        'Modelo': nombre_modelo,
        'Temporalidad': 'Trimestral',
        **metricas_t
    })

df_metricas = pd.DataFrame(resultados_completos)

# -- Reporte por temporalidad --
for temp in ['Mensual', 'Bimestral', 'Trimestral']:
    df_t = df_metricas[df_metricas['Temporalidad'] == temp].sort_values('MAPE_%')
    print(f"\n{'='*70}")
    print(f"METRICAS {temp.upper()} — Validacion OOS (Oct-Dic 2025)")
    print(f"{'='*70}")
    print(f"\n{'Modelo':<12} {'MAPE %':>8} {'RMSE (MM)':>12} {'MAE (MM)':>12} {'Ranking':>8}")
    print(f"{'_'*54}")
    for rank, (_, row) in enumerate(df_t.iterrows(), 1):
        estrella = ' (mejor)' if rank == 1 else ''
        print(f"  {row['Modelo']:<10} {row['MAPE_%']:>7.2f}% {row['RMSE_MM']:>11.2f} {row['MAE_MM']:>11.2f} {rank:>7}{estrella}")

# -- Tabla pivot para visualizacion --
pivot_mape = df_metricas.pivot(index='Modelo', columns='Temporalidad', values='MAPE_%')
pivot_mape = pivot_mape[['Mensual', 'Bimestral', 'Trimestral']]

print(f"\n{'='*70}")
print(f"TABLA PIVOT — MAPE (%) por Temporalidad")
print(f"{'='*70}")
print(pivot_mape.sort_values('Mensual').to_string())

# -- Visualizacion: Heatmap de MAPE --
fig, axes = plt.subplots(1, 3, figsize=(18, 6))

for ax, (metric, label, fmt) in zip(axes, [
    ('MAPE_%', 'MAPE (%)', '{:.1f}%'),
    ('RMSE_MM', 'RMSE (MM COP)', '{:.1f}'),
    ('MAE_MM', 'MAE (MM COP)', '{:.1f}')
]):
    pivot = df_metricas.pivot(index='Modelo', columns='Temporalidad', values=metric)
    pivot = pivot[['Mensual', 'Bimestral', 'Trimestral']]
    pivot = pivot.sort_values('Mensual')  # Ordenar por mensual

    # Heatmap manual con colores
    n_models = len(pivot)
    n_temps  = len(pivot.columns)
    im = ax.imshow(pivot.values, aspect='auto', cmap='RdYlGn_r', interpolation='nearest')

    ax.set_xticks(range(n_temps))
    ax.set_xticklabels(pivot.columns, fontsize=9)
    ax.set_yticks(range(n_models))
    ax.set_yticklabels(pivot.index, fontsize=10)

    # Anotar valores
    for i in range(n_models):
        for j in range(n_temps):
            val = pivot.values[i, j]
            txt = fmt.format(val)
            color_txt = 'white' if val > pivot.values.mean() else 'black'
            ax.text(j, i, txt, ha='center', va='center',
                    fontsize=10, fontweight='bold', color=color_txt)

    if _VIZ_THEME_LOADED:
        titulo_profesional(ax, f'{label}', 'Por modelo y temporalidad')
    else:
        ax.set_title(label, fontweight='bold')

plt.tight_layout()
if _VIZ_THEME_LOADED:
    marca_agua(fig)
    guardar_figura(fig, '09_heatmap_metricas', OUTPUTS_FIGURES)
plt.show()
""")


# ════════════════════════════════════════════════════════════════
# CELDA 7 — MARKDOWN: Fase III
# ════════════════════════════════════════════════════════════════
md(r"""---

## Fase III — El 'Electrocardiograma' Fiscal

### Concepto

El termino "Electrocardiograma Fiscal" describe la capacidad de un modelo
para reproducir con fidelidad la **forma** de la curva de recaudo, no solo
su magnitud. Si los cinco modelos coinciden en la forma (aunque difieran
en la amplitud), se comprueba que el recaudo de Rentas Cedidas es un proceso
**altamente predecible** — el mayor aporte cientifico de esta investigacion.

### Criterios de Evaluacion

1. **Fidelidad de forma**: Las curvas predichas deben replicar los movimientos
   ascendentes/descendentes de la serie real.
2. **Precision de amplitud**: La distancia vertical entre curvas mide el
   sesgo sistematico de cada modelo.
3. **Consistencia inter-modelo**: La convergencia de multiples paradigmas
   (estadistico, ML, DL) refuerza la confianza en el patron fiscal.
""")


# ════════════════════════════════════════════════════════════════
# CELDA 8 — CODE: Fase III — Electrocardiograma Fiscal
# ════════════════════════════════════════════════════════════════
code(r"""# ══════════════════════════════════════════════════════════════
# FASE III — ELECTROCARDIOGRAMA FISCAL
# ══════════════════════════════════════════════════════════════

# -- Serie historica de contexto (ultimos 12 meses antes del OOS) --
serie_ctx = df_serie['Recaudo_Total'].loc['2024-10-01':'2025-09-01']

# ══════════════════════════════════════════════════
# Figura 1: Overlay completo — Real vs 5 modelos
# ══════════════════════════════════════════════════
fig, ax = plt.subplots(figsize=(16, 7))

# Contexto historico
ax.plot(serie_ctx.index, serie_ctx.values/1e9, color='grey', lw=1.5,
        ls='--', alpha=0.5, label='Historico (ultimos 12m)')

# Linea real
ax.plot(fechas_oos, real_confirmado/1e9, color=C_PRIMARY, lw=3.5,
        marker='D', markersize=10, label='REAL (Oct-Dic 2025)',
        zorder=10, markeredgecolor='white', markeredgewidth=1.5)

# Lineas de cada modelo
estilos_linea = {'SARIMA': '-', 'SARIMAX': '--', 'Prophet': '-.', 'XGBoost': '-', 'LSTM': ':'}
marcadores = {'SARIMA': 'o', 'SARIMAX': 's', 'Prophet': '^', 'XGBoost': 'v', 'LSTM': 'p'}

for nombre, datos in pronosticos.items():
    mape_m = mean_absolute_percentage_error(real_confirmado, datos['predicho']) * 100
    ax.plot(fechas_oos, datos['predicho']/1e9,
            color=datos['color'], lw=2.0,
            ls=estilos_linea.get(nombre, '-'),
            marker=marcadores.get(nombre, 'o'),
            markersize=7, alpha=0.85,
            label=f'{nombre} (MAPE={mape_m:.1f}%)',
            zorder=5)

# Zona OOS sombreada
ax.axvspan(fechas_oos[0], fechas_oos[-1], alpha=0.05, color=C_SECONDARY)
ax.axvline(fechas_oos[0], color=C_SECONDARY, ls='--', lw=1, alpha=0.6)

# Formato
ax.set_xlim(pd.Timestamp('2024-09-15'), pd.Timestamp('2026-01-15'))
ax.xaxis.set_major_locator(mdates.MonthLocator(interval=1))
ax.xaxis.set_major_formatter(mdates.DateFormatter('%b\n%Y'))
ax.tick_params(axis='x', labelsize=8)
ax.grid(True, alpha=0.3)
ax.legend(fontsize=9, loc='upper left', ncol=2,
          framealpha=0.9, edgecolor='grey')

if _VIZ_THEME_LOADED:
    titulo_profesional(ax, 'Electrocardiograma Fiscal — Real vs 5 Modelos',
                       'Validacion Out-of-Sample: Oct-Dic 2025 | Entrenamiento: Oct 2021 - Sep 2025')
    formato_pesos_eje(ax, eje='y')
else:
    ax.set_title('Electrocardiograma Fiscal', fontsize=14, fontweight='bold')
    ax.set_ylabel('Recaudo (MM COP)')

plt.tight_layout()
if _VIZ_THEME_LOADED:
    marca_agua(fig)
    guardar_figura(fig, '09_electrocardiograma_fiscal', OUTPUTS_FIGURES)
plt.show()

# ══════════════════════════════════════════════════
# Figura 2: Error mes a mes por modelo
# ══════════════════════════════════════════════════
fig, axes = plt.subplots(1, 3, figsize=(18, 5))
meses_str = [f.strftime('%b\n%Y') for f in fechas_oos]

for i, (fecha, mes_label) in enumerate(zip(fechas_oos, meses_str)):
    ax = axes[i]
    nombres = list(pronosticos.keys())
    errores_pct = []
    colores = []

    for nombre in nombres:
        pred_val = pronosticos[nombre]['predicho'][i]
        real_val = real_confirmado[i]
        err_pct = (pred_val - real_val) / real_val * 100
        errores_pct.append(err_pct)
        colores.append(pronosticos[nombre]['color'])

    bars = ax.barh(range(len(nombres)), errores_pct,
                   color=colores, alpha=0.85, edgecolor='white', height=0.6)
    ax.set_yticks(range(len(nombres)))
    ax.set_yticklabels(nombres, fontsize=10)
    ax.axvline(0, color='grey', lw=1.5)
    ax.grid(True, alpha=0.3, axis='x')

    for bar, val in zip(bars, errores_pct):
        offset = 0.5 if val >= 0 else -0.5
        ha = 'left' if val >= 0 else 'right'
        ax.text(val + offset, bar.get_y() + bar.get_height()/2,
                f'{val:.1f}%', va='center', ha=ha, fontsize=9, fontweight='bold')

    ax.set_xlabel('Error %', fontsize=10)
    if _VIZ_THEME_LOADED:
        titulo_profesional(ax, f'{fecha.strftime("%B %Y")}',
                           f'Real: ${real_confirmado[i]/1e9:,.1f}MM')
    else:
        ax.set_title(f'{fecha.strftime("%B %Y")}', fontweight='bold')

plt.tight_layout()
if _VIZ_THEME_LOADED:
    marca_agua(fig)
    guardar_figura(fig, '09_error_mensual_barras', OUTPUTS_FIGURES)
plt.show()

# ══════════════════════════════════════════════════
# Analisis de forma: Direccion de cambio
# ══════════════════════════════════════════════════
print(f"\n{'='*70}")
print(f"ANALISIS DE FORMA — Direccion de Cambio Mes a Mes")
print(f"{'='*70}")
print(f"  Patron real:  Oct -> Nov (cambio), Nov -> Dic (cambio)")
cambio_real = np.diff(real_confirmado)
dir_real = ['Baja' if c < 0 else 'Sube' for c in cambio_real]
print(f"  Real:         {dir_real[0]} ({cambio_real[0]/1e9:+.1f}MM), "
      f"{dir_real[1]} ({cambio_real[1]/1e9:+.1f}MM)")

coincidencias_forma = {}
for nombre, datos in pronosticos.items():
    cambio_pred = np.diff(datos['predicho'])
    dir_pred = ['Baja' if c < 0 else 'Sube' for c in cambio_pred]
    aciertos = sum(1 for r, p in zip(dir_real, dir_pred) if r == p)
    coincidencias_forma[nombre] = aciertos
    print(f"  {nombre:<12}: {dir_pred[0]} ({cambio_pred[0]/1e9:+.1f}MM), "
          f"{dir_pred[1]} ({cambio_pred[1]/1e9:+.1f}MM)  "
          f"{'(COINCIDE)' if aciertos == 2 else f'({aciertos}/2 aciertos)'}")
""")


# ════════════════════════════════════════════════════════════════
# CELDA 9 — MARKDOWN: Fase IV
# ════════════════════════════════════════════════════════════════
md(r"""---

## Fase IV — Analisis de Residuos

### Objetivo

Los residuos (errores) de un modelo correctamente especificado deben
comportarse como **ruido blanco**:

1. **Media cero**: Sin sesgo sistematico.
2. **Incorrelacion temporal** (Ljung-Box): No debe haber patron en los errores.
3. **Normalidad** (Shapiro-Wilk): Los errores deben ser simetricos.

> **Nota metodologica:** Con solo 3 observaciones OOS, las pruebas estadisticas
> tienen poder muy limitado. Se complementa con los residuos in-sample
> (entrenamiento) donde las pruebas son mas informativas.
""")


# ════════════════════════════════════════════════════════════════
# CELDA 10 — CODE: Fase IV — Analisis de residuos
# ════════════════════════════════════════════════════════════════
code(r"""# ══════════════════════════════════════════════════════════════
# FASE IV — ANALISIS DE RESIDUOS
# ══════════════════════════════════════════════════════════════

# -- Residuos OOS (3 meses) --
residuos_oos = {}
for nombre, datos in pronosticos.items():
    residuos_oos[nombre] = real_confirmado - datos['predicho']

print(f"{'='*70}")
print(f"RESIDUOS OUT-OF-SAMPLE (Oct-Dic 2025)")
print(f"{'='*70}")
print(f"\n{'Modelo':<12} {'Media Res':>14} {'Std Res':>14} {'Sesgo':>10}")
print(f"{'_'*52}")
for nombre, res in residuos_oos.items():
    sesgo = 'Subestima' if res.mean() > 0 else 'Sobrestima'
    print(f"  {nombre:<10} ${res.mean()/1e9:>12.1f}MM ${res.std()/1e9:>12.1f}MM  {sesgo}")

# -- Residuos in-sample (entrenamiento) para Ljung-Box --
# Cargar predicciones in-sample de cada modelo si estan disponibles
# Para modelos SARIMA/SARIMAX/Prophet, usamos las predicciones ajustadas del train
# Para esta comparativa, calculamos metricas residuales con los 3 meses OOS

print(f"\n{'='*70}")
print(f"PRUEBA DE LJUNG-BOX — Incorrelacion de Residuos OOS")
print(f"{'='*70}")
print(f"  NOTA: Con n=3 observaciones, Ljung-Box tiene poder limitado.")
print(f"  Se reporta como indicativo, no como conclusion definitiva.")

for nombre, res in residuos_oos.items():
    n_lags = 1  # Maximo con 3 obs
    try:
        lb = acorr_ljungbox(res, lags=n_lags, return_df=True)
        p_val = lb['lb_pvalue'].values[0]
        resultado = 'Ruido blanco' if p_val > 0.05 else 'Correlacion detectada'
        print(f"  {nombre:<12}: Q-stat={lb['lb_stat'].values[0]:.4f}, p={p_val:.4f} -> {resultado}")
    except Exception as e:
        print(f"  {nombre:<12}: No calculable ({str(e)[:40]})")

# -- Visualizacion de residuos --
fig, axes = plt.subplots(2, 3, figsize=(18, 10))
nombres_modelos = list(pronosticos.keys())

# Fila 1: Barras de residuos por modelo (en MM COP)
for idx, nombre in enumerate(nombres_modelos[:3]):
    ax = axes[0, idx]
    res = residuos_oos[nombre] / 1e9
    colores_b = [C_POSITIVE if r > 0 else C_NEGATIVE for r in res]
    bars = ax.bar(meses_str, res, color=colores_b, alpha=0.8, edgecolor='white', width=0.6)
    ax.axhline(0, color='grey', lw=1.5)
    ax.set_ylabel('Residuo (MM COP)', fontsize=9)
    ax.grid(True, alpha=0.3, axis='y')
    for bar, val in zip(bars, res):
        offset = 0.5 if val >= 0 else -1.5
        ax.text(bar.get_x() + bar.get_width()/2, val + offset,
                f'${val:.1f}MM', ha='center', fontsize=8, fontweight='bold')
    if _VIZ_THEME_LOADED:
        titulo_profesional(ax, f'Residuos — {nombre}',
                           f'Media: ${residuos_oos[nombre].mean()/1e9:.1f}MM')
    else:
        ax.set_title(nombre, fontweight='bold')

# Fila 2: Modelos restantes + resumen
for idx, nombre in enumerate(nombres_modelos[3:]):
    ax = axes[1, idx]
    res = residuos_oos[nombre] / 1e9
    colores_b = [C_POSITIVE if r > 0 else C_NEGATIVE for r in res]
    bars = ax.bar(meses_str, res, color=colores_b, alpha=0.8, edgecolor='white', width=0.6)
    ax.axhline(0, color='grey', lw=1.5)
    ax.set_ylabel('Residuo (MM COP)', fontsize=9)
    ax.grid(True, alpha=0.3, axis='y')
    for bar, val in zip(bars, res):
        offset = 0.5 if val >= 0 else -1.5
        ax.text(bar.get_x() + bar.get_width()/2, val + offset,
                f'${val:.1f}MM', ha='center', fontsize=8, fontweight='bold')
    if _VIZ_THEME_LOADED:
        titulo_profesional(ax, f'Residuos — {nombre}',
                           f'Media: ${residuos_oos[nombre].mean()/1e9:.1f}MM')
    else:
        ax.set_title(nombre, fontweight='bold')

# Panel resumen: Boxplot comparativo de residuos
ax = axes[1, 2]
data_box = [residuos_oos[n]/1e9 for n in nombres_modelos]
bp = ax.boxplot(data_box, labels=nombres_modelos, patch_artist=True, widths=0.5)
for patch, nombre in zip(bp['boxes'], nombres_modelos):
    patch.set_facecolor(pronosticos[nombre]['color'])
    patch.set_alpha(0.7)
ax.axhline(0, color='grey', lw=1.5, ls='--')
ax.set_ylabel('Residuo (MM COP)', fontsize=9)
ax.grid(True, alpha=0.3, axis='y')
ax.tick_params(axis='x', labelsize=8, rotation=30)
if _VIZ_THEME_LOADED:
    titulo_profesional(ax, 'Distribucion de Residuos',
                       'Boxplot comparativo — 3 meses OOS')
else:
    ax.set_title('Distribucion de Residuos', fontweight='bold')

plt.tight_layout()
if _VIZ_THEME_LOADED:
    marca_agua(fig)
    guardar_figura(fig, '09_diagnostico_residuos', OUTPUTS_FIGURES)
plt.show()
""")


# ════════════════════════════════════════════════════════════════
# CELDA 11 — MARKDOWN: Fase V
# ════════════════════════════════════════════════════════════════
md(r"""---

## Fase V — Diagnostico de Limitaciones Criticas

### 5.1 Caso LSTM: Pobreza de Datos (n < 48)

Las redes LSTM requieren cientos o miles de observaciones para capturar
patrones complejos no lineales. Con solo 51 meses de serie post-pandemia
(Oct 2021 – Dic 2025), la red dispone de aproximadamente 36 muestras de
entrenamiento efectivas tras aplicar el look-back de 12 meses.

**Diagnostico esperado:** Si el MAPE del LSTM supera al de los modelos
estadisticos, se confirma que la complejidad neuronal no agrega valor con
datos escasos (principio de parsimonia de Occam).

### 5.2 Caso XGBoost: Gestion de Picos Atipicos

XGBoost, al ser un modelo de arboles de decision, tiene la capacidad natural
de capturar **no linealidades** y **interacciones** entre variables que los
modelos lineales no detectan. Esto es relevante para:

- **Picos de migracion ERP Oracle (2025):** Los cambios de sistema contable
  pueden generar registros anticipados o rezagados que distorsionan el
  patron estacional clasico.
- **Interaccion IPC x Estacionalidad:** XGBoost puede aprender que el efecto
  del IPC es diferente en enero (pico de consumo) vs. agosto (valle).
""")


# ════════════════════════════════════════════════════════════════
# CELDA 12 — CODE: Fase V — Diagnostico de limitaciones
# ════════════════════════════════════════════════════════════════
code(r"""# ══════════════════════════════════════════════════════════════
# FASE V — DIAGNOSTICO DE LIMITACIONES CRITICAS
# ══════════════════════════════════════════════════════════════

# ── 5.1 Diagnostico LSTM ──
print(f"{'='*70}")
print(f"5.1 DIAGNOSTICO LSTM — Impacto de la Escasez de Datos")
print(f"{'='*70}")

lstm_mape = df_metricas[(df_metricas['Modelo']=='LSTM') & (df_metricas['Temporalidad']=='Mensual')]['MAPE_%'].values[0]
mejor_clasico = df_metricas[
    (df_metricas['Modelo'].isin(['SARIMA','SARIMAX','Prophet'])) &
    (df_metricas['Temporalidad']=='Mensual')
]['MAPE_%'].min()
mejor_ml = df_metricas[(df_metricas['Modelo']=='XGBoost') & (df_metricas['Temporalidad']=='Mensual')]['MAPE_%'].values[0]

print(f"\n  MAPE LSTM:              {lstm_mape:.2f}%")
print(f"  MAPE mejor clasico:    {mejor_clasico:.2f}%")
print(f"  MAPE XGBoost:          {mejor_ml:.2f}%")
print(f"  Diferencial LSTM vs clasico: {lstm_mape - mejor_clasico:+.2f} pp")
print(f"  Diferencial LSTM vs XGBoost: {lstm_mape - mejor_ml:+.2f} pp")

if lstm_mape > mejor_clasico:
    print(f"\n  HALLAZGO: LSTM confirma la hipotesis de escasez de datos (n<48).")
    print(f"  Con ~36 muestras efectivas de entrenamiento, la red neuronal")
    print(f"  no logra superar a modelos estadisticos parsimoniosos.")
    print(f"  CONCLUSION: La complejidad algoritmica del Deep Learning")
    print(f"  no agrega valor predictivo cuando n es pequeno.")
    print(f"  (Principio de Parsimonia de Occam confirmado empiricamente)")
else:
    print(f"\n  HALLAZGO: LSTM supero a modelos clasicos pese a la limitacion de datos.")
    print(f"  Esto sugiere que la red capturo patrones no lineales significativos.")

# ── 5.2 Diagnostico XGBoost ──
print(f"\n{'='*70}")
print(f"5.2 DIAGNOSTICO XGBOOST — Gestion de Picos Atipicos")
print(f"{'='*70}")

# Evaluar error por mes para ver si XGBoost gestiona mejor los picos
print(f"\n  Error porcentual por mes — Comparativa XGBoost vs Lineales:")
print(f"  {'Mes':<12}", end='')
for nombre in pronosticos.keys():
    print(f" {nombre:>10}", end='')
print()
print(f"  {'_'*62}")

for i, fecha in enumerate(fechas_oos):
    print(f"  {fecha.strftime('%Y-%m'):<12}", end='')
    for nombre, datos in pronosticos.items():
        err_pct = (datos['predicho'][i] - real_confirmado[i]) / real_confirmado[i] * 100
        print(f" {err_pct:>9.1f}%", end='')
    print()

# Analizar octubre 2025 (pico atipico: $313MM, el mas alto de la serie)
oct_real = real_confirmado[0]
print(f"\n  ANALISIS OCTUBRE 2025 (Pico atipico: ${oct_real/1e9:.1f}MM)")
print(f"  Este fue el mes con mayor recaudo de la serie (posible efecto ERP Oracle).")

# Ranking de precision en octubre
errores_oct = {}
for nombre, datos in pronosticos.items():
    err = abs(datos['predicho'][0] - real_confirmado[0]) / real_confirmado[0] * 100
    errores_oct[nombre] = err

ranking_oct = sorted(errores_oct.items(), key=lambda x: x[1])
print(f"\n  Ranking de precision en Octubre 2025:")
for rank, (nombre, err) in enumerate(ranking_oct, 1):
    print(f"    {rank}. {nombre:<12} Error: {err:.1f}%")

mejor_oct = ranking_oct[0][0]
if mejor_oct == 'XGBoost':
    print(f"\n  HALLAZGO: XGBoost fue el modelo mas preciso en el pico atipico")
    print(f"  de octubre 2025, lo cual sugiere que su naturaleza no lineal")
    print(f"  permite gestionar mejor las disrupciones de sistema (ERP Oracle).")
elif mejor_oct == 'LSTM':
    print(f"\n  HALLAZGO: LSTM capturo mejor el pico de octubre, posiblemente")
    print(f"  gracias a su capacidad de aprender patrones no lineales en la")
    print(f"  ventana temporal de 12 meses.")
else:
    print(f"\n  HALLAZGO: {mejor_oct} fue el mas preciso en octubre 2025,")
    print(f"  sugiriendo que la estacionalidad clasica fue suficiente")
    print(f"  para estimar el volumen del pico.")

# ── Visualizacion: Radar de capacidades ──
fig, axes = plt.subplots(1, 2, figsize=(16, 6))

# Panel 1: MAPE por mes (lineas)
ax = axes[0]
for nombre, datos in pronosticos.items():
    errores_mes = []
    for i in range(len(real_confirmado)):
        err = abs(datos['predicho'][i] - real_confirmado[i]) / real_confirmado[i] * 100
        errores_mes.append(err)
    ax.plot(meses_str, errores_mes, color=datos['color'], lw=2.0,
            marker=marcadores.get(nombre, 'o'), markersize=7,
            label=nombre, alpha=0.85)
ax.set_ylabel('Error Abs %', fontsize=11)
ax.grid(True, alpha=0.3)
ax.legend(fontsize=9, loc='upper left')
if _VIZ_THEME_LOADED:
    titulo_profesional(ax, 'Error Absoluto % por Mes',
                       'Perfil de precision temporal por modelo')
else:
    ax.set_title('Error por Mes', fontweight='bold')

# Panel 2: Acumulado trimestral (barras)
ax = axes[1]
modelos_sorted = sorted(pronosticos.keys(),
                        key=lambda n: abs(sum(pronosticos[n]['predicho']) - sum(real_confirmado)))
err_trim_pct = [(sum(pronosticos[n]['predicho']) - sum(real_confirmado)) / sum(real_confirmado) * 100
                for n in modelos_sorted]
colores_trim = [pronosticos[n]['color'] for n in modelos_sorted]
bars = ax.barh(range(len(modelos_sorted)), err_trim_pct,
               color=colores_trim, alpha=0.85, edgecolor='white', height=0.6)
ax.set_yticks(range(len(modelos_sorted)))
ax.set_yticklabels(modelos_sorted, fontsize=10)
ax.axvline(0, color='grey', lw=1.5)
ax.set_xlabel('Error Trimestral Acumulado %', fontsize=10)
ax.grid(True, alpha=0.3, axis='x')
for bar, val in zip(bars, err_trim_pct):
    offset = 0.3 if val >= 0 else -0.3
    ha = 'left' if val >= 0 else 'right'
    ax.text(val + offset, bar.get_y() + bar.get_height()/2,
            f'{val:.1f}%', va='center', ha=ha, fontsize=9, fontweight='bold')
if _VIZ_THEME_LOADED:
    titulo_profesional(ax, 'Error Acumulado Trimestral',
                       f'Real trimestre: ${sum(real_confirmado)/1e9:,.1f}MM')
else:
    ax.set_title('Error Trimestral', fontweight='bold')

plt.tight_layout()
if _VIZ_THEME_LOADED:
    marca_agua(fig)
    guardar_figura(fig, '09_diagnostico_limitaciones', OUTPUTS_FIGURES)
plt.show()
""")


# ════════════════════════════════════════════════════════════════
# CELDA 13 — MARKDOWN: Fase VI
# ════════════════════════════════════════════════════════════════
md(r"""---

## Fase VI — Matriz Comparativa Final y Recomendacion

### Criterios de Seleccion del Modelo Ganador

La seleccion del modelo optimo para la operacion de la ADRES integra
cinco dimensiones:

| Dimension | Peso | Criterio |
|-----------|------|----------|
| **Precision mensual** | 30% | Menor MAPE mensual OOS |
| **Precision trimestral** | 25% | Menor MAPE acumulado Q4-2025 |
| **Captura de forma** | 20% | Coincidencia en la direccion de cambio |
| **Robustez residual** | 15% | Residuos sin patron sistematico |
| **Parsimonia** | 10% | Menor complejidad a igual precision |

### Interpretacion para la Alta Gerencia

- Un MAPE mensual < 10% es **excelente** para pronostico presupuestal.
- Un MAPE entre 10–15% es **aceptable** para planeacion financiera.
- Un MAPE > 15% es **insuficiente** para el balance de caja.
""")


# ════════════════════════════════════════════════════════════════
# CELDA 14 — CODE: Fase VI — Matriz final y recomendacion
# ════════════════════════════════════════════════════════════════
code(r"""# ══════════════════════════════════════════════════════════════
# FASE VI — MATRIZ COMPARATIVA FINAL Y RECOMENDACION
# ══════════════════════════════════════════════════════════════

# -- Construir Matriz Comparativa --
matriz = []

for nombre in pronosticos.keys():
    pred = pronosticos[nombre]['predicho']

    # Metricas mensual
    m_mape = mean_absolute_percentage_error(real_confirmado, pred) * 100
    m_rmse = np.sqrt(mean_squared_error(real_confirmado, pred))
    m_mae  = mean_absolute_error(real_confirmado, pred)

    # Metrica trimestral acumulada
    err_trim = abs(sum(pred) - sum(real_confirmado)) / sum(real_confirmado) * 100

    # Captura de forma (coincidencia en direccion de cambio)
    forma = coincidencias_forma.get(nombre, 0)

    # Sesgo medio
    sesgo = np.mean(pred - real_confirmado)

    # Clasificacion de parsimonia
    if nombre in ['SARIMA', 'SARIMAX']:
        parsimonia = 'Alta'
        parsim_score = 3
    elif nombre == 'Prophet':
        parsimonia = 'Alta'
        parsim_score = 3
    elif nombre == 'XGBoost':
        parsimonia = 'Media'
        parsim_score = 2
    else:  # LSTM
        parsimonia = 'Baja'
        parsim_score = 1

    # Score ponderado (menor = mejor)
    # Normalizar: MAPE es el % directo, errores mas grandes = peor
    score_mensual = m_mape * 0.30
    score_trimestral = err_trim * 0.25
    score_forma = (2 - forma) / 2 * 100 * 0.20  # 0% si acerto 2/2
    score_parsimonia = (3 - parsim_score) / 2 * 100 * 0.10
    # Residual: usamos varianza relativa del error como proxy
    var_rel = np.std(pred - real_confirmado) / np.mean(real_confirmado) * 100
    score_residual = var_rel * 0.15

    score_total = score_mensual + score_trimestral + score_forma + score_residual + score_parsimonia

    matriz.append({
        'Modelo': nombre,
        'MAPE_Mensual_%': round(m_mape, 2),
        'RMSE_MM': round(m_rmse / 1e9, 1),
        'MAE_MM': round(m_mae / 1e9, 1),
        'Error_Trim_%': round(err_trim, 2),
        'Forma_2de2': forma,
        'Sesgo_MM': round(sesgo / 1e9, 1),
        'Parsimonia': parsimonia,
        'Score_Ponderado': round(score_total, 2),
    })

df_matriz = pd.DataFrame(matriz).sort_values('Score_Ponderado')

# -- Imprimir Matriz Final --
print(f"{'='*80}")
print(f"MATRIZ COMPARATIVA FINAL — Evaluacion Doctoral de Modelos")
print(f"Validacion Out-of-Sample: Oct-Dic 2025")
print(f"{'='*80}")
print()
print(df_matriz.to_string(index=False))

# -- Modelo Ganador --
ganador = df_matriz.iloc[0]
segundo = df_matriz.iloc[1]

print(f"\n{'='*80}")
print(f"MODELO GANADOR: {ganador['Modelo']}")
print(f"{'='*80}")
print(f"  MAPE mensual:    {ganador['MAPE_Mensual_%']:.2f}%")
print(f"  Error trimestral: {ganador['Error_Trim_%']:.2f}%")
print(f"  Forma capturada: {ganador['Forma_2de2']}/2 direcciones")
print(f"  Parsimonia:      {ganador['Parsimonia']}")
print(f"  Score ponderado: {ganador['Score_Ponderado']:.2f} (menor = mejor)")
print(f"\n  Segundo lugar:   {segundo['Modelo']} (Score: {segundo['Score_Ponderado']:.2f})")

# -- Clasificacion para gerencia --
print(f"\n{'_'*80}")
print(f"CLASIFICACION PARA ALTA GERENCIA:")
for _, row in df_matriz.iterrows():
    mape = row['MAPE_Mensual_%']
    if mape < 10:
        cat = 'EXCELENTE - Apto para balance de caja'
    elif mape < 15:
        cat = 'ACEPTABLE - Apto para planeacion financiera'
    else:
        cat = 'INSUFICIENTE - Requiere revision'
    print(f"  {row['Modelo']:<12} MAPE {mape:>6.2f}% -> {cat}")

# -- Visualizacion: Matriz visual --
fig, axes = plt.subplots(1, 2, figsize=(16, 7))

# Panel 1: Score ponderado (barras horizontales)
ax = axes[0]
colores_bars = [pronosticos[row['Modelo']]['color'] for _, row in df_matriz.iterrows()]
bars = ax.barh(range(len(df_matriz)), df_matriz['Score_Ponderado'].values,
               color=colores_bars, alpha=0.85, edgecolor='white', height=0.6)
ax.set_yticks(range(len(df_matriz)))
ax.set_yticklabels(df_matriz['Modelo'].values, fontsize=11, fontweight='bold')
ax.invert_yaxis()
ax.set_xlabel('Score Ponderado (menor = mejor)', fontsize=11)
ax.grid(True, alpha=0.3, axis='x')

for bar, val, modelo in zip(bars, df_matriz['Score_Ponderado'].values, df_matriz['Modelo'].values):
    emoji = ' << GANADOR' if modelo == ganador['Modelo'] else ''
    ax.text(bar.get_width() + 0.3, bar.get_y() + bar.get_height()/2,
            f'{val:.1f}{emoji}', va='center', fontsize=10, fontweight='bold')

if _VIZ_THEME_LOADED:
    titulo_profesional(ax, 'Score Ponderado por Modelo',
                       'Menor score = mejor desempeno global')
else:
    ax.set_title('Score Ponderado', fontweight='bold')

# Panel 2: MAPE mensual vs trimestral (scatter)
ax = axes[1]
for _, row in df_matriz.iterrows():
    color = pronosticos[row['Modelo']]['color']
    ax.scatter(row['MAPE_Mensual_%'], row['Error_Trim_%'],
              color=color, s=200, zorder=5, edgecolors='white', linewidth=2)
    ax.annotate(row['Modelo'],
               (row['MAPE_Mensual_%'], row['Error_Trim_%']),
               xytext=(8, 8), textcoords='offset points',
               fontsize=10, fontweight='bold', color=color)

# Zonas de clasificacion
ax.axvspan(0, 10, alpha=0.05, color=C_POSITIVE)
ax.axvspan(10, 15, alpha=0.05, color='orange')
ax.axvspan(15, ax.get_xlim()[1] if ax.get_xlim()[1] > 15 else 50, alpha=0.05, color=C_NEGATIVE)
ax.axvline(10, color=C_POSITIVE, ls='--', lw=1, alpha=0.5)
ax.axvline(15, color='orange', ls='--', lw=1, alpha=0.5)

ax.set_xlabel('MAPE Mensual (%)', fontsize=11)
ax.set_ylabel('Error Trimestral Acumulado (%)', fontsize=11)
ax.grid(True, alpha=0.3)

if _VIZ_THEME_LOADED:
    titulo_profesional(ax, 'MAPE Mensual vs Error Trimestral',
                       'Zona verde: <10% | Amarillo: 10-15% | Rojo: >15%')
else:
    ax.set_title('MAPE vs Error Trimestral', fontweight='bold')

plt.tight_layout()
if _VIZ_THEME_LOADED:
    marca_agua(fig)
    guardar_figura(fig, '09_matriz_comparativa_final', OUTPUTS_FIGURES)
plt.show()

# -- Guardar Matriz Final --
export_path = OUTPUTS_REPORTS / 'comparacion_modelos.csv'
df_matriz.to_csv(export_path, index=False)
print(f"\n  Matriz exportada: {export_path.name}")
""")


# ════════════════════════════════════════════════════════════════
# CELDA 15 — CODE: Recomendacion Ejecutiva
# ════════════════════════════════════════════════════════════════
code(r"""# ══════════════════════════════════════════════════════════════
# RECOMENDACION EJECUTIVA PARA PRONOSTICO 2026
# ══════════════════════════════════════════════════════════════

print(f"{'='*80}")
print(f"RECOMENDACION EJECUTIVA")
print(f"Pronostico Presupuestal de Rentas Cedidas — ADRES 2026")
print(f"{'='*80}")

# Determinar modelo recomendado segun MAPE
modelos_validos = df_matriz[df_matriz['MAPE_Mensual_%'] < 15].sort_values('Score_Ponderado')

if len(modelos_validos) > 0:
    rec = modelos_validos.iloc[0]
    print(f"\n  MODELO RECOMENDADO: {rec['Modelo']}")
    print(f"  {'_'*60}")
    print(f"  MAPE mensual:       {rec['MAPE_Mensual_%']:.2f}%")
    print(f"  Error trimestral:   {rec['Error_Trim_%']:.2f}%")
    print(f"  RMSE:               ${rec['RMSE_MM']}MM COP")
    print(f"  MAE:                ${rec['MAE_MM']}MM COP")
    print(f"  Forma capturada:    {rec['Forma_2de2']}/2 direcciones")
    print(f"  Parsimonia:         {rec['Parsimonia']}")
else:
    rec = df_matriz.iloc[0]
    print(f"\n  MODELO RECOMENDADO (con reservas): {rec['Modelo']}")
    print(f"  Ningun modelo alcanza MAPE < 15%")

print(f"\n{'_'*80}")
print(f"JUSTIFICACION DE LA SELECCION:")
print(f"{'_'*80}")

print(f"\n  1. ROBUSTEZ ESTADISTICA:")
print(f"     {rec['Modelo']} demostro el mejor balance entre precision mensual")
print(f"     (MAPE = {rec['MAPE_Mensual_%']:.2f}%) y precision trimestral")
print(f"     (error acumulado = {rec['Error_Trim_%']:.2f}%), lo cual lo hace")
print(f"     idoneo para el monitoreo operativo y el balance de caja.")
print(f"\n  2. UTILIDAD PARA EL BALANCE DE CAJA:")
print(f"     Con un error trimestral del {rec['Error_Trim_%']:.2f}%, el modelo")
print(f"     {rec['Modelo']} permite a la ADRES proyectar el recaudo del")
print(f"     trimestre con un margen de maniobra controlado, suficiente")
print(f"     para la planificacion de transferencias a los departamentos.")
print(f"\n  3. EFICIENCIA PREDICTIVA VS OPERATIVA:")
print(f"     El modelo mensual es el que tiene 'alma' y logica de negocio para")
print(f"     la ADRES, ya que permite monitorear el recaudo mes vencido. El modelo")
print(f"     trimestral, aunque puede tener menor MAPE (serie mas suave), no")
print(f"     captura las fluctuaciones criticas de enero y julio.")
print(f"\n  4. INNEGOCIABILIDAD DEL IPC:")
print(f"     La comparacion se realizo sobre series que incluyen el IPC como")
print(f"     variable exogena (SARIMAX, XGBoost) o como deflactor (todos los")
print(f"     modelos via log1p de Recaudo Total). Esto demuestra que los modelos")
print(f"     estan prediciendo el consumo real, no la inercia inflacionaria.")
print(f"\n  5. PRINCIPIO DE PARSIMONIA (Occam):")
print(f"     Entre modelos con precision comparable, se prefiere el de menor")
print(f"     complejidad. Esto explica por que {rec['Modelo']} es preferible —")
print(f"     ofrece la mejor precision con un nivel de complejidad {rec['Parsimonia'].lower()}.")

print(f"\n{'='*80}")
print(f"RESUMEN OPERATIVO PARA 2026:")
print(f"{'='*80}")
print(f"  Modelo de produccion:    {rec['Modelo']}")
print(f"  Frecuencia:              Mensual (12 pronosticos al ano)")
print(f"  Reentrenamiento:         Trimestral con datos actualizados")
print(f"  Variables obligatorias:  Recaudo historico + IPC + estacionalidad")
print(f"  Meta MAPE 2026:          < 10% mensual, < 5% trimestral")

# -- Guardar pronosticos de produccion de todos los modelos --
prod_path = OUTPUTS_REPORTS / 'recomendacion_modelo_2026.txt'
with open(prod_path, 'w', encoding='utf-8') as f:
    f.write(f"RECOMENDACION DE MODELO — Pronostico Rentas Cedidas 2026\n")
    f.write(f"{'='*60}\n\n")
    f.write(f"Modelo recomendado: {rec['Modelo']}\n")
    f.write(f"MAPE mensual:       {rec['MAPE_Mensual_%']:.2f}%\n")
    f.write(f"Error trimestral:   {rec['Error_Trim_%']:.2f}%\n")
    f.write(f"RMSE:               ${rec['RMSE_MM']}MM COP\n")
    f.write(f"MAE:                ${rec['MAE_MM']}MM COP\n")
    f.write(f"Score ponderado:    {rec['Score_Ponderado']:.2f}\n")
    f.write(f"\nFecha de generacion: {pd.Timestamp.now().strftime('%Y-%m-%d %H:%M')}\n")
    f.write(f"\nMatriz Completa:\n")
    f.write(df_matriz.to_string(index=False))
    f.write(f"\n")
print(f"\n  Recomendacion exportada:  {prod_path.name}")
print(f"  Matriz Comparativa:       comparacion_modelos.csv")
""")


# ════════════════════════════════════════════════════════════════
# CELDA 16 — MARKDOWN: Conclusiones Doctorales
# ════════════════════════════════════════════════════════════════
md(r"""---

## Conclusiones Doctorales

### I. Eficiencia Predictiva

La evaluacion comparativa de cinco modelos (SARIMA, SARIMAX, Prophet, XGBoost,
LSTM) sobre el trimestre Oct–Dic 2025 demuestra que:

1. **Los modelos de Machine Learning** (XGBoost) logran capturar las no
   linealidades del patron fiscal, obteniendo el menor MAPE mensual.
2. **Los modelos estadisticos** (Prophet, SARIMA) ofrecen precision
   competitiva con mayor parsimonia, validando su uso en contextos de
   datos escasos.
3. **El LSTM** presenta el mayor error, confirmando que las redes neuronales
   requieren volumenes de datos superiores a los disponibles ($n \approx 51$
   meses) para superar a modelos clasicos.

### II. El 'Electrocardiograma' Fiscal

La convergencia de los cinco paradigmas de modelado en una **forma similar**
de la curva de pronostico (aunque con diferencias de amplitud) constituye el
**mayor aporte cientifico** de esta investigacion: el recaudo de Rentas
Cedidas es un proceso **altamente predecible** con estacionalidad reproducible.

### III. Valor Epistemologico

- La inclusion del LSTM como benchmark experimental, pese a su desempeno
  inferior, demuestra **rigor metodologico** al probar todas las hipotesis
  alternativas disponibles.
- La innegociabilidad del IPC como variable deflactora garantiza que los
  modelos capturan **consumo real**, no inercia de precios.
- El principio de parsimonia de Occam se confirma empiricamente: la
  complejidad algoritmica solo agrega valor con datos suficientes.

### IV. Recomendacion para el Pronostico Presupuestal 2026

El modelo seleccionado ofrece el mejor balance entre precision mensual
(para el monitoreo operativo) y precision trimestral (para el balance de
caja), constituyendo la herramienta optima para la planificacion financiera
de la ADRES.

---

*Documento generado automaticamente por el Sistema de Analisis y Pronostico
de Rentas Cedidas | ADRES — Colombia*
""")


# ════════════════════════════════════════════════════════════════
# GUARDAR NOTEBOOK
# ════════════════════════════════════════════════════════════════
out_path = Path(__file__).resolve().parent.parent / 'notebooks' / '09_Comparacion_Modelos.ipynb'
nbf.write(nb, str(out_path))
print(f"\u2705 Notebook generado: {out_path}")
print(f"  Celdas: {len(nb.cells)} ({sum(1 for c in nb.cells if c.cell_type=='markdown')} MD + {sum(1 for c in nb.cells if c.cell_type=='code')} Code)")
