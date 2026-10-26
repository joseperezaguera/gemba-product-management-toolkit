# User Stories Validadas — ShopSearch Faceted Search

**Generado por:** `/stories` → `/validate-stories`
**Input:** `research/jtbds.md` (JTBD-01 + JTBD-02)
**Stories generadas:** 5
**Score promedio:** 8.4/10
**Antipatrones detectados:** 0

---

## Story 1: DETECT-01 — Clasificar query como ambigua/específica

**Como** sistema de búsqueda
**Cuando** recibo una query del cliente y devuelvo resultados
**quiero** clasificarla como `ambiguous` o `specific` basándome en la dispersión de categorías en los top-K resultados
**para** decidir si la respuesta debe incluir facetas inline

### JTBD Reforzado

- **Job principal:** JTBD-01 (refinar búsqueda ambigua sin esfuerzo extra)
- **Trigger:** Query recibida con K=20 resultados top
- **Desired outcome:** Clasificación correcta en ≥90% de queries de prueba
- **Behavior change:** START — el sistema añade `query_classification` en la respuesta

### Wendel Checklist

| Pregunta | Respuesta |
|----------|-----------|
| Experiencia previa | El servicio ya construye top-K resultados; añadimos análisis post-ranker |
| Relación con producto | Sistema interno; sin UX directa al cliente en esta story |
| Motivación situacional | Habilita Stories 2-5 (sin clasificación, no hay decisión sobre facetas) |
| Impedimento actual | Hoy no existe clasificación de ambigüedad |

### Behavior Change

- **AHORA:** Sistema responde sin metadata de ambigüedad
- **NUEVO:** Sistema añade `query_classification: "ambiguous" | "specific"` en metadata

### Evidencia

- **Cuantitativa (de Farolas):** 12% de queries son ambiguas → la clasificación es necesaria para el resto del feature
- **Cualitativa (de Penumbras):** N/A (story técnica habilitadora)

### Acceptance Criteria

- [ ] Test con 50 queries (25 ambiguas, 25 específicas) — clasificador acierta ≥90%
- [ ] Test de latencia — clasificación <10ms p99

### Scoring 6D

| Dim | Score | Razón |
|-----|-------|-------|
| 1. JTBD & Problem Context | 8 | Habilita JTBD-01 directamente; evidencia cuantitativa sólida |
| 2. User Specificity | 7 | "Sistema" como actor — story técnica, justificada porque es habilitadora |
| 3. Behavior Change | 9 | START claro y testeable |
| 4. Zone of Control | 10 | Equipo de búsqueda controla 100% |
| 5. Time Constraints | 8 | Phase 1 backend, dependencia para todo el feature |
| 6. Survivable Experiment | 9 | Aislado del cliente final; reversible vía feature flag |

**Score Global: 8.5/10**

---

## Story 2: FACET-01/02 — Generar facetas con poder discriminatorio

**Como** sistema de búsqueda
**Cuando** clasifico una query como `ambiguous`
**quiero** seleccionar 3-5 facetas de los atributos del catálogo con mayor poder discriminatorio (entropía normalizada)
**para** ofrecer al cliente filtros relevantes que reduzcan la dispersión de los resultados

### JTBD Reforzado

- **Job principal:** JTBD-01
- **Trigger:** `query_classification = "ambiguous"`
- **Desired outcome:** Array `facets` con 3-5 entradas, cada una con 2-10 valores válidos
- **Behavior change:** START — sistema produce facetas

### Acceptance Criteria

- [ ] Para 25 queries de prueba ambiguas, todas devuelven 3-5 facetas válidas
- [ ] Cada faceta tiene entre 2 y 10 valores
- [ ] Cobertura de atributos: ≥80% de las facetas devueltas existen como atributos en ≥70% de los productos del top-K

### Scoring

**Score Global: 8.7/10** — JTBD claro, evidencia sólida, behavior change explícito, controlable, testeable.

---

## Story 3: FACET-03/04 — Ordenar facetas y valores por relevancia

**Como** cliente recurrente
**Cuando** veo facetas auto-generadas en los resultados de mi búsqueda
**quiero** que las facetas más útiles (las que más se aplican históricamente) aparezcan primero, y que los valores de cada faceta vayan de más comunes a menos comunes
**para** poder elegir el filtro correcto sin tener que leerme todos los chips

### JTBD Reforzado

- **Job principal:** JTBD-01 (reducir esfuerzo cognitivo)
- **Trigger:** Cliente ve los chips post-búsqueda
- **Desired outcome:** Tap en chip correcto en ≤2s
- **Behavior change:** DIFFERENT — orden por relevancia, no por orden alfabético ni aleatorio

### Acceptance Criteria

- [ ] Test verifica que `facets` está ordenado descendente por uso histórico (consulta `facet_usage_stats`)
- [ ] Test verifica que `facets[i].values` está ordenado descendente por `count` en los resultados de la query

### Scoring

**Score Global: 8.3/10** — User specificity alta (cliente recurrente identificado en research); behavior change claro.

---

## Story 4: UI-01 a UI-05 — Render de chips inline en mobile/web

**Como** cliente recurrente que busca un producto en mobile
**Cuando** mi query es ambigua y el sistema devuelve facetas
**quiero** ver chips horizontales debajo del search bar, scrollables si no caben, con apply/remove rápido
**para** refinar la búsqueda en menos de 3 segundos sin escribir más

### JTBD Reforzado

- **Job principal:** JTBD-02 (reducir esfuerzo cognitivo en mobile)
- **Trigger:** Respuesta de search incluye `facets` con ≥3 entradas
- **Desired outcome:** Cliente aplica una faceta en ≤3 taps y ve resultados refrescados sin recargar la página
- **Behavior change:** START — UI nueva en la página de resultados

### Acceptance Criteria

- [ ] En mobile: chips renderizados debajo del search bar
- [ ] Chips scrollables horizontalmente si no caben
- [ ] Tap aplica faceta sin recargar la página
- [ ] Faceta aplicada con estado "active" + botón ✕ funcional
- [ ] Transición visual ≤300ms en device de referencia mid-range

### Scoring

**Score Global: 8.6/10** — JTBD validado con research, evidencia cualitativa fuerte (4/5 prefieren chips a sidebar).

---

## Story 5: TELEM-01 a TELEM-04 — Telemetría de uso de facetas

**Como** equipo de producto
**Cuando** el feature está en producción
**quiero** medir `facet_shown`, `facet_applied`, `facet_dismissed` con contexto de query
**para** decidir si el feature cumple los targets (apply_rate ≥25%, search abandon ↓30%, cart_add ↑8%)

### Acceptance Criteria

- [ ] Los 3 eventos llegan al pipeline de analytics estándar
- [ ] Dashboard muestra `facet_apply_rate` y `cart_add_rate` segmentado por con/sin faceta
- [ ] Alerta configurada si `facet_apply_rate` cae >30% día/día

### Scoring

**Score Global: 7.9/10** — User specificity baja ("equipo de producto" como actor — necesario para esta story de medición pero no es un usuario externo).

---

## Resumen del scoring

| Story | Dim 1 | Dim 2 | Dim 3 | Dim 4 | Dim 5 | Dim 6 | Global | Estado |
|-------|-------|-------|-------|-------|-------|-------|--------|--------|
| 1. DETECT-01 | 8 | 7 | 9 | 10 | 8 | 9 | **8.5** | 🟢 Lista |
| 2. FACET-01/02 | 9 | 7 | 9 | 10 | 8 | 9 | **8.7** | 🟢 Lista |
| 3. FACET-03/04 | 8 | 8 | 8 | 10 | 8 | 8 | **8.3** | 🟢 Lista |
| 4. UI-01 a UI-05 | 9 | 9 | 9 | 9 | 8 | 8 | **8.6** | 🟢 Lista |
| 5. TELEM-01 a TELEM-04 | 7 | 6 | 8 | 10 | 8 | 9 | **7.9** | 🟢 Lista |

**Score promedio: 8.4/10** — Pipeline supera el threshold de 7. Todas las stories pasan a `/split-stories` y `/prioritize`.

## Antipatrones detectados

Ninguno. Las stories han sido revisadas por:
- ✓ "As a user..." → no aplica (actores específicos)
- ✓ No Behavior Change → todas tienen START/DIFFERENT explícito
- ✓ Fake Story → la única con actor "sistema" (Story 1) está justificada como habilitadora
- ✓ Solution as Need → las stories describen el qué+por qué, no prescriben implementación específica
- ✓ Deliverable Outside Control → todas en zona de control del equipo
- ✓ Everything is Urgent → ninguna tiene deadline artificial
- ✓ Division by Technical Layers → cada story aporta valor end-to-end (excepto Story 1 que es deliberadamente backend habilitadora)
