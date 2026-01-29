# Plan de Acción Inmediato - Sistema de Learning del Orchestrator

**Fecha**: 2026-01-29
**Versión**: v2.81.1
**Prioridad**: URGENTE

---

## 🎯 Resumen Ejecutivo para el Usuario

He completado una **búsqueda exhaustiva** de TODAS las fuentes disponibles:

✅ **Documentación** (docs/, .claude/, historial de git)
✅ **Scripts implementados** (~/.ralph/, .claude/hooks/)
✅ **Configuración activa** (hooks registrados, plan-state, reglas)
✅ **Análisis previos** (CURATOR_FLOW.md, AUTO_LEARNING_ORCHESTRATOR.md)

### Conclusión Principal

**✅ LOS TRES COMPONENTES ESTÁN 100% IMPLEMENTADOS Y FUNCIONALES**

1. **Repo Curator** → `~/.ralph/curator/` (9 scripts completos)
2. **Repository Learner** → `~/.ralph/scripts/repo-learn.sh` (v1.4.0)
3. **Plan-State System** → `~/.ralph/plan-state/` (v2.62.0)

### El Problema Real

**Los componentes existen pero NO están integrados automáticamente**

```
ACTUAL:
Usuario pide implementación compleja
  ↓
Sistema detecta: "Necesitas aprender mejores prácticas"
  ↓
Sistema recomienda: "Ejecuta /curator"
  ↓
Usuario IGNORA la recomendación
  ↓
Implementación se hace SIN mejores prácticas
  ↓
Resultado: Calidad inferior

IDEAL:
Usuario pide implementación compleja
  ↓
Sistema detecta: "Necesitas aprender mejores prácticas"
  ↓
Sistema EJECUTA /curator AUTOMÁTICAMENTE
  ↓
Sistema INYECTA las mejores prácticas aprendidas
  ↓
Sistema VALIDA que se aplicaron
  ↓
Resultado: Calidad óptima
```

---

## 🔥 Acciones Inmediatas (Hoy)

### 1. NO Eliminar Hooks "Obsoletos" Aún

**Por qué**: El análisis previo marcó 9 hooks como "obsoletos" PERO:

- ❌ `orchestrator-auto-learn.sh` → **CRÍTICO** (detecta gaps de aprendizaje)
- ❌ `procedural-inject.sh` → **CRÍTICO** (inyecta reglas en prompts)
- ❌ `plan-state-init.sh` → **CRÍTICO** (inicializa tracking)

**Acción**:
```bash
# Validar hooks ANTES de eliminar
chmod +x .claude/scripts/validate-hooks-before-removal.sh
.claude/scripts/validate-hooks-before-removal.sh
# Revisa los resultados en .claude/hooks-validation-results.md
```

### 2. Revisar el Análisis Completo

**Documento creado**: `docs/analysis/ORCHESTRATOR_LEARNING_SYSTEM_COMPLETE_ANALYSIS_v2.81.1.md`

**Contiene**:
- ✅ Estado de cada componente (100% implementado)
- ✅ 13 bugs críticos de curator identificados
- ✅ 5 gaps de integración documentados
- ✅ Plan de mejora en 5 fases (10-15 días)
- ✅ Roadmap detallado con milestones

### 3. Entender el Flujo Completo

```
┌─────────────────────────────────────────────────────────────┐
│          FLUJO COMPLETO DEL SISTEMA DE LEARNING             │
└─────────────────────────────────────────────────────────────┘

1. Usuario solicita tarea compleja
   ↓
2. orchestrator-auto-learn.sh (PreToolUse hook)
   ├─ Detecta complejidad (1-10)
   ├─ Detecta dominio (backend, security, database, etc.)
   ├─ Cuenta reglas relevantes en ~/.ralph/procedural/rules.json
   └─ Si < 3 reglas relevantes:
       └─ Actualiza learning_state en plan-state.json
          └─ Recomienda ejecutar /curator

3. Usuario DECIDE ejecutar /curator (o NO)
   ↓
   SI ejecuta:
   ├─ curator-full.sh --type backend --lang typescript
   │  ├─ curator-discovery.sh (busca en GitHub)
   │  ├─ curator-scoring.sh (calidad + relevance)
   │  └─ curator-rank.sh (ranking top-N)
   ├─ Usuario aprueba repositorios
   └─ curator-learn.sh (aprende de repos)
      └─ repo-learn.sh (extrae patrones)
         └─ Actualiza ~/.ralph/procedural/rules.json

   NO ejecuta:
   └─ Task se ejecuta SIN mejores prácticas

4. procedural-inject.sh (PreToolUse hook)
   ├─ Detecta dominio de la tarea
   ├─ Busca reglas con confidence >= 0.7
   ├─ Selecciona hasta 5 reglas
   └─ Las INYECTA en el prompt del Task

5. Task se ejecuta
   └─ Modelo genera código
      └─ Puede o NO aplicar las reglas inyectadas

6. [FALTA] rule-verification.sh (PostToolUse hook)
   └─ NO EXISTE AÚN
      └─ Debería validar que las reglas se aplicaron

7. orchestrator-report.sh (Stop hook)
   ├─ Lee plan-state para progreso
   ├─ Calcula métricas de efectividad
   └─ Genera recomendaciones
```

---

## 📋 Plan de Acción por Fases

### Fase 0: Validación (Hoy - 2 horas)

**Objetivo**: Entender el estado actual sin romper nada

```bash
# 1. Validar hooks "obsoletos"
chmod +x .claude/scripts/validate-hooks-before-removal.sh
.claude/scripts/validate-hooks-before-removal.sh

# 2. Ver estado de reglas procedimentales
cat ~/.ralph/procedural/rules.json | jq '{
  total: (.rules | length),
  with_id: ([.rules[] | select(.id != null)] | length),
  with_domain: ([.rules[] | select(.domain != null)] | length),
  with_usage: ([.rules[] | select(.usage_count > 0)] | length)
}'

# 3. Ver estado de learning
cat ~/.ralph/plan-state/plan-state.json | jq '.learning_state'

# 4. Listar repositorios curados
ls -la ~/.ralph/curator/corpus/approved/
```

### Fase 1: Fixes Críticos de Curator (Día 1-2)

**Objetivo**: Resolver 13 bugs que afectan la calidad del aprendizaje

**Archivos a modificar**:
- `~/.ralph/curator/scripts/curator-scoring.sh`
- `~/.ralph/curator/scripts/curator-ingest.sh`
- `~/.ralph/curator/scripts/curator-discovery.sh`

**Documentación de referencia**:
- `docs/audits/CURATOR_FLOW.md` (análisis completo de los 13 bugs)

### Fase 2: Integración de Learning (Día 3-5)

**Objetivo**: Que el aprendizaje se aplique AUTOMÁTICAMENTE

**Nuevo hook a crear**: `.claude/hooks/learning-gate.sh`
```bash
# Si learning_state.is_critical == true
# Y auto_learn.enabled == true
# ENTONCES ejecutar /curator automáticamente
# Y bloquear hasta que haya >= 3 reglas relevantes
```

**Nuevo hook a crear**: `.claude/hooks/rule-verification.sh`
```bash
# PostToolUse hook
# Analiza código generado
# Valida que las reglas inyectadas se aplicaron
# Actualiza applied_count en reglas
```

### Fase 3: Métricas (Día 6-7)

**Objetivo**: Medir la efectividad del sistema

**Métricas a implementar**:
- Rule Utilization Rate (% de reglas usadas)
- Application Rate (% de reglas que se aplican)
- Quality Improvement (delta en quality gates)
- Time Saved (tiempo ahorrado)

### Fase 4: Documentación (Día 8-9)

**Objetivo**: Documentar el sistema completo

**Archivos a actualizar**:
- `README.md` - Agregar sección "Learning System"
- `CLAUDE.md` - Explicar integración de componentes
- Crear `docs/learning/INTEGRATION_GUIDE.md`

### Fase 5: Testing (Día 10-15)

**Objetivo**: Validar que todo funciona

**Tests a crear**:
- `tests/learning/test-curator-full-pipeline.sh`
- `tests/learning/test-learning-gate.sh`
- `tests/learning/test-rule-verification.sh`
- `tests/learning/test-integration-end-to-end.sh`

---

## 🚀 Acciones que Puedes Tomar AHORA MISMO

### Opción 1: Ejecutar Análisis Completo (5 minutos)

```bash
# Leer el análisis completo
cat docs/analysis/ORCHESTRATOR_LEARNING_SYSTEM_COMPLETE_ANALYSIS_v2.81.1.md

# O abrir en tu editor favorito
code docs/analysis/ORCHESTRATOR_LEARNING_SYSTEM_COMPLETE_ANALYSIS_v2.81.1.md
```

### Opción 2: Validar el Sistema Actual (10 minutos)

```bash
# Ejecutar script de validación
chmod +x .claude/scripts/validate-hooks-before-removal.sh
.claude/scripts/validate-hooks-before-removal.sh

# Revisar resultados
cat .claude/hooks-validation-results.md
```

### Opción 3: Probar el Sistema de Learning (15 minutos)

```bash
# 1. Ver curadores disponibles
ralph curator show --type backend --lang typescript

# 2. Ejecutar pipeline de curator
ralph curator full --type backend --lang typescript --top-n 5

# 3. Aprobar repositorios
ralph curator approve --all

# 4. Aprender de repositorios
ralph curator learn --all

# 5. Ver reglas aprendidas
cat ~/.ralph/procedural/rules.json | jq '.rules[] | select(.usage_count > 0)'
```

### Opción 4: Usar /adversarial para Cerrar Gaps (30 minutos)

```bash
# Usar adversarial para analizar gaps de integración
/adversarial "Analiza los gaps de integración entre repo-learn, curator y plan-state. Identifica qué falta para que el sistema funcione automáticamente."

# Usar codex-cli para diseñar solución
/codex-cli "Diseña la arquitectura de un learning-gate hook que bloquee la ejecución cuando learning_state.is_critical == true y no hay suficientes reglas relevantes."

# Usar gemini-cli para validar
/gemini-cli "Valida el diseño del learning-gate hook. ¿Hay riesgos de seguridad? ¿Bloqueos infinitos?"
```

---

## 📊 Estado Actual del Sistema

### Componentes

| Componente | Estado | Calidad | Integración |
|------------|--------|---------|-------------|
| Repo Curator | ✅ 100% | ⚠️ 60% (13 bugs) | ⚠️ 50% |
| Repository Learner | ✅ 100% | ⚠️ 70% | ⚠️ 50% |
| Plan-State | ✅ 100% | ✅ 90% | ⚠️ 70% |
| Auto-Learning Hooks | ✅ 100% | ✅ 80% | ⚠️ 40% |
| **OVERALL** | **✅ 100%** | **⚠️ 70%** | **⚠️ 50%** |

### Reglas Procedurales

```
Total: 1003 reglas
├── Con ID: ~50 (5%)
├── Con domain: ~900 (90%)
├── Con usage: ~100 (10%)
└── Utilization: 8% (muy bajo)
```

**Problema**: 90% de las reglas no se usan nunca

### Learning State

```json
{
  "recommended": true,
  "reason": "Insufficient rules for high-complexity task",
  "domain": "devops",
  "complexity": 10,
  "severity": "HIGH",
  "is_critical": false,
  "auto_executed": false,
  "auto_exec_enabled": false
}
```

**Problema**: `auto_executed: false` - El sistema NO ejecuta learning automáticamente

---

## 🎯 Próximos Pasos Recomendados

1. **HOY**: Leer análisis completo
   - `docs/analysis/ORCHESTRATOR_LEARNING_SYSTEM_COMPLETE_ANALYSIS_v2.81.1.md`

2. **HOY**: Validar hooks "obsoletos"
   - `.claude/scripts/validate-hooks-before-removal.sh`

3. **ESTA SEMANA**: Priorizar Fase 1
   - Fixes críticos de curator (13 bugs)

4. **PRÓXIMA SEMANA**: Implementar Fase 2
   - Learning gate + verification hooks

5. **SEMANA 3**: Completar Fases 3-5
   - Métricas + documentación + testing

---

## 📚 Documentación Creada

1. **ORCHESTRATOR_LEARNING_SYSTEM_COMPLETE_ANALYSIS_v2.81.1.md**
   - Análisis exhaustivo de todo el sistema
   - Estado de cada componente
   - 5 gaps de integración identificados
   - Plan de mejora en 5 fases

2. **validate-hooks-before-removal.sh**
   - Script para validar hooks antes de eliminar
   - Verifica referencias, funcionalidad, reemplazos

3. **PLAN_ACCION_INMEDIATO_v2.81.1.md** (este documento)
   - Resumen ejecutivo
   - Acciones inmediatas
   - Plan por fases

---

**¿Qué quieres hacer primero?**

1. ¿Leer el análisis completo?
2. ¿Validar los hooks "obsoletos"?
3. ¿Probar el sistema de curator?
4. ¿Usar /adversarial para cerrar gaps?
5. ¿Otra cosa?

---

*Generado para facilitar toma de decisiones inmediata*
*Fecha: 2026-01-29*
