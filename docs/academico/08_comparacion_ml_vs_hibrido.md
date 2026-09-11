# Comparación: Sistema Solo-ML vs. Sistema Híbrido Multicapa

> Comparación basada en ejecuciones reales del pipeline sobre muestras disponibles.
> Actualizado 2026-09-11 al modelo v1.1.0 (mediciones originales: 2026-08-18).

---

## Sistema original (solo ML)

```
Entrada (binario PE)
        │
        ▼
Feature Extractor (2381 dims EMBER + OVERLAY_6 → 2387)
  - ByteHistogram (256)
  - ByteEntropy (256)
  - Strings (104)
  - General (10)
  - Header (62)
  - Section (255)
  - Imports (1280)
  - Exports (128)
  - DataDirectories (30)
  - OVERLAY_6 (slack, tamaño, imports, certificado, patrón stub)
        │
        ▼
StandardScaler por bloque (Z-score: EMBER + OVERLAY)
        │
        ▼
Red Neuronal ONNX v1.1.0
  2387 → 512 → 256 → 128 → 1 (sigmoid)
        │
        ▼
score ∈ [0.0, 1.0]
        │
        ▼
label = "MALWARE" si score ≥ 0.5
label = "BENIGN"  si score < 0.5
```

**Output final**: `{label, score, confidence}`

---

## Sistema actual (híbrido multicapa)

```
Entrada (binario PE)
        │
        ▼
[F1] YARA Scanner ──────────────────────── match? → DANGEROUS (early exit)
        │
        ▼
[F2] Feature Extractor (2381 dims + OVERLAY_6 → 2387)
        │
        ▼
[F3] ML/ONNX Inference
  → label, score, confidence
        │
        ▼
[F4] Overlay Analysis
  → overlay_ratio, overlay_entropy, embedded_pe
        │
        ▼
[F5] DotNet Analysis
  → obfuscator, embedded_assemblies, il_score
        │
        ▼
[F6] IL Behavioral Analysis
  → injection, persistence, networking, credentials...
        │
        ▼
[F7] Risk Engine (correlación)
  Inputs: YARA + ML + Overlay + DotNet + IL
  Output: operational_status, risk_level, risk_score, triggered_indicators
        │
        ▼
ScanResult completo:
  {label, score, operational_status, risk_level, risk_score,
   yara_matches, overlay_analysis, heuristic_assessment,
   dotnet_analysis, il_behavioral, triggered_indicators, justification}
```

---

## Comparación de resultados sobre samples disponibles

### sample1.exe (20.9 MB — binario con overlay payload)

| Aspecto | Solo ML | Híbrido Multicapa |
|---------|---------|-------------------|
| ML score | 0.0913 | 0.0913 (idéntico) |
| ML label | BENIGN | SUSPICIOUS (correlación) |
| Veredicto final | **BENIGN** | **SUSPICIOUS** |
| Risk level | — | CRITICAL |
| Risk score | — | 105 |
| Overlay analizado | No | 19.7 MB |
| Indicadores activados | 0 | 6 |
| Detección correcta | ❌ Falso Negativo | ✅ Detectado |

**Conclusión**: el sistema híbrido detectó lo que el sistema solo-ML no pudo detectar.

### procexp64.exe (herramienta legítima — Sysinternals)

| Aspecto | Solo ML | Híbrido Multicapa |
|---------|---------|-------------------|
| YARA match | `Keylogger_Generic` | `Keylogger_Generic` (degradado por whitelist) |
| ML score | 0.0101 | 0.0101 (idéntico) |
| ML label | BENIGN | SUSPICIOUS (correlación) |
| Veredicto final | **BENIGN** | **SUSPICIOUS** |
| Risk level | — | HIGH |
| Detección correcta | ✅ Correcto | ✅ Correcto (con advertencia YARA) |

**Nota**: El falso positivo del modelo anterior (score 1.0) quedó corregido en v1.1.0 (score 0.0101). El match YARA persiste pero se degrada por whitelist a SUSPICIOUS.

### eicar.txt (test EICAR — no PE)

| Aspecto | Solo ML | Híbrido Multicapa |
|---------|---------|-------------------|
| ML score | 0.0040 | 0.0040 (idéntico) |
| ML label | BENIGN | BENIGN |
| YARA match | 0 | 0 |
| Veredicto final | BENIGN | CLEAN |
| Detección correcta | ❌ No detectado | ❌ No detectado |

**Limitación compartida**: las reglas YARA no incluyen la firma EICAR estándar.

---

## Ventajas del sistema híbrido (verificadas)

1. **Detección de overlay payloads**: confirmada en sample1.exe. El overlay de 19.7 MB con entropía 7.9987 fue detectado como DANGEROUS, situación que el solo-ML produce como BENIGN.

2. **Detección de binarios .NET ofuscados**: DotNet Analysis detectó ofuscación en sample2.exe (dotnet_risk_score=28). El solo-ML aislado queda en BENIGN (score 0.4660 < 0.5); la correlación con `ml_onnx` + DotNet lo eleva a SUSPICIOUS.

3. **Evidencias auditables**: el sistema híbrido produce `triggered_indicators`, `heuristic_assessment.justification`, y evidencias IL forenses. El solo-ML no produce explicación alguna.

4. **Tolerancia a fallos**: si el modelo ONNX falla, el pipeline continúa con YARA + Overlay + DotNet + IL. El solo-ML falla completamente. (Verificado: `test_onnx_failure_suspicious` → PASSED)

5. **Early exit por YARA**: si una firma coincide, no se ejecutan fases costosas (extracción + ONNX). (Verificado: procexp64.exe, tiempo=55ms vs >1000ms para sample1.exe)

6. **No-PE support**: archivos no-PE son analizados en modo RAW_FALLBACK. El solo-ML fallaría o produciría resultados sin sentido.

---

## Limitaciones del sistema híbrido (verificadas)

1. **Falsos positivos YARA**: las reglas actuales activan sobre software legítimo (procexp64.exe). Existe whitelist (`yara_exclusions`) que degrada el match a SUSPICIOUS; el modelo v1.1.0 además ya no acompaña el FP (score 0.0101).

2. **BehavioralShield no integrado**: la capa de monitoreo dinámico (psutil) existe en código pero no está conectada al pipeline. Si estuviera integrada, añadiría una 8ª capa de detección.

3. **IL Behavioral solo para .NET**: el 70%+ del malware actual es nativo (C/C++/Delphi). La capa IL no aporta para esos binarios.

4. **Mayor latencia**: el pipeline completo tarda ~2,026 ms para sample1.exe (extracción ~1,501 ms + resto de capas) vs. ~1,516 ms para solo extracción+ML. La sobrecarga de las capas adicionales puede ser relevante en análisis masivo en tiempo real.

5. **Alertas solo en `malicious`/`DANGEROUS`**: n8n está deprecated (alertas vía webhook Supabase → Edge Function). Casos SUSPICIOUS relevantes como sample1.exe no generan alerta automática; es un gap de integración documentado en la auditoría.

---

## Resumen comparativo

| Dimensión | Solo ML | Híbrido Multicapa |
|-----------|---------|-------------------|
| Detección overlay payload | ❌ | ✅ |
| Detección binarios .NET ofuscados | Parcial | ✅ |
| Explicabilidad | ❌ Opaco | ✅ Evidencias forenses |
| Detección de firma conocida | ❌ (sin YARA) | ✅ (con YARA) |
| Tolerancia a fallos | Baja | Alta |
| Tiempo de análisis (archivo grande) | ~1,516 ms | ~2,026 ms |
| Falsos positivos YARA | N/A | Presentes |
| Auditable por analista | No | Sí |
| Monitoreo dinámico | No | No (pendiente) |

---

## T-14 — Benchmark estadístico ML vs. Híbrido (F4 — pendiente corpus)

> **PENDIENTE**: Requiere `samples/overlay_corpus/` con N≥100 PE overlay maliciosos.
> Script: `python evaluation/benchmark_overlay.py --corpus samples/overlay_corpus/ --help`

### Metodología (experiment-designer + McNemar)

El benchmark es **pareado por muestra** (mismo corpus, dos sistemas):

| Métrica | Descripción |
|---|---|
| FNR_ML | False Negative Rate del sistema solo-ML sobre CorpusOverlay |
| FNR_híbrido | FNR del sistema multicapa completo |
| FNR_diff | FNR_ML − FNR_híbrido (ganancia esperada ≥10pp) |
| McNemar χ² | Test pareado con corrección de Yates |
| p-value | Con Bonferroni α/3 = 0.0167 |
| Guardrail FPR | FPR_híbrido − FPR_ML ≤ 2pp sobre benignos de `data/eval_real` |

### Tabla de resultados (pendiente corpus)

| Sistema | N | FNR | FNR diff | McNemar χ² | p-value | Guardrail FPR |
|---|---|---|---|---|---|---|
| solo-ML (ONNX) | — | — | — | — | — | — |
| híbrido | — | — | — | — | — | ≤ +2pp |

> Figura: `docs/academico/figures/fig_overlay_benchmark.png`
> (barras FNR con intervalos Wilson 95% + histograma overlay_ratio + línea sample1.exe=98.7%)
>
> **Calibración Platt**: aplicada antes de fijar thresholds 0.4/0.7.
> **Bonferroni**: α corregida a 0.0167 por múltiples métricas simultáneas.

