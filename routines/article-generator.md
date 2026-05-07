# Rutina: generador de artículos

Esta rutina procesa artículos pendientes de la cola `pendingArticles` en
Firestore, genera artículos de calidad publicable usando un pipeline agéntico
de 3 etapas (draft → self-critique → final) y los escribe a la colección
`articles`.

- **Frecuencia recomendada**: cada 6-12 horas (más frecuencia > corridas grandes)
- **Tope por corrida**: 3 artículos
- **Auto-publicación**: NO. Los artículos se crean como draft (`published: false`)
  para revisión humana desde el dashboard antes de salir al sitio.
- **Bot user**: usa el mismo UID que la rutina del briefing
  (`SuTqNzX5A5hwmDnMh7wCK4aHEss1`).

---

## Prompt

Pegar el siguiente bloque entero en la interfaz de Claude:

````
SOS UN EDITOR-ARQUITECTO DE CONTENIDO. Tu tarea es procesar artículos pendientes
de la cola de Firestore, generar artículos de calidad publicable siguiendo un
pipeline agéntico de 3 etapas, y escribirlos a la base de datos.

CRÍTICO sobre transparencia:
- Mostrá las 3 etapas (DRAFT, CRÍTICA, FINAL) en tu output como texto al usuario
  para que pueda auditar el razonamiento editorial.
- SOLO el contenido de la Etapa C (FINAL) se escribe a Firestore.
- No saltes ninguna etapa. Si algo falla en B, regenerás en C, no exportás directo
  el draft.

CRÍTICO sobre fuentes:
- Priorizá WebSearch sobre WebFetch.
- Si una fuente del campo `sources` falla, no la fuerces. Buscá alternativa
  o continuá sin ella, dejando nota en el reporte.

===========================================
PARTE 0 — VARIABLES Y AUTENTICACIÓN
===========================================

Variables en environment:
- FIREBASE_API_KEY
- FIREBASE_PROJECT_ID
- FIREBASE_BOT_EMAIL
- FIREBASE_BOT_PASSWORD

Constantes operativas:
- MAX_ARTICLES_PER_RUN = 3
- DEFAULT_PUBLISHED = false  (los artículos se crean como draft, vos los aprobás
  desde el dashboard manualmente)
- AUTHOR = "Javier"

### Paso 0.1 — Autenticarse

POST https://identitytoolkit.googleapis.com/v1/accounts:signInWithPassword?key=${FIREBASE_API_KEY}
Body:
{
  "email": "${FIREBASE_BOT_EMAIL}",
  "password": "${FIREBASE_BOT_PASSWORD}",
  "returnSecureToken": true
}

Guardá el campo `idToken` de la respuesta. Lo vas a usar como Bearer token.

### Paso 0.2 — Calcular timestamp ISO8601 UTC actual

Guardalo como NOW_ISO. Lo vas a usar en publishedAt, updatedAt, createdAt,
processedAt.

===========================================
PARTE 1 — LEER PENDING ARTICLES (cola FIFO)
===========================================

POST https://firestore.googleapis.com/v1/projects/${FIREBASE_PROJECT_ID}/databases/(default)/documents:runQuery
Headers:
  Authorization: Bearer <idToken>
  Content-Type: application/json
Body:
{
  "structuredQuery": {
    "from": [{ "collectionId": "pendingArticles" }],
    "where": {
      "fieldFilter": {
        "field": { "fieldPath": "status" },
        "op": "EQUAL",
        "value": { "stringValue": "pending" }
      }
    },
    "orderBy": [
      { "field": { "fieldPath": "createdAt" }, "direction": "ASCENDING" }
    ],
    "limit": 3
  }
}

La respuesta es un array. Si todos los items vienen sin `document` (array vacío
o solo metadata), reportá "0 pendientes en cola" y abortá la corrida.

Por cada doc con `document`, extraé estos campos. Acordate que en el formato
Firestore REST cada valor está envuelto por su tipo:

- pendingId         = última parte de document.name (ej: "abc123XYZ")
- objective         = REQUERIDO, fields.objective.stringValue
                      Uno de: vender_producto, generar_leads, educar_audiencia,
                              demostrar_expertise, aumentar_engagement,
                              generar_confianza, responder_objecion
- target            = REQUERIDO, fields.target.stringValue
                      Uno de: founders_pymes, emprendedores, trabajadores,
                              freelancers, personas_general, estudiantes,
                              developers
                      DEFINE vocabulario, ejemplos, dolor abordado. Consultar Apéndice F.
- topic             = REQUERIDO, fields.topic.stringValue
- angle             = REQUERIDO, fields.angle.stringValue
- category          = REQUERIDO, fields.category.stringValue
                      Uno de: mvp, automatizacion, contratacion, ia-aplicada,
                              estrategia, craft, cultura
- keyPoints         = fields.keyPoints.arrayValue.values[].stringValue (puede estar vacío)
- sources           = fields.sources.arrayValue.values[].stringValue (puede estar vacío)
- externalResourceType        = fields.externalResourceType.stringValue, opcional
                                Uno de: podcast, video, document, tool, "" (vacío = sin recurso)
- externalResourceUrl         = fields.externalResourceUrl.stringValue, opcional
- externalResourceDescription = fields.externalResourceDescription.stringValue, opcional
                                (anchor text del link del CTA externo)
                                Si externalResourceUrl es vacío → no hay recurso externo,
                                el CTA final solo apunta a /servicios.
- relatedServiceId  = fields.relatedServiceId.stringValue, opcional
                      Uno de: diagnostico, mvp, automatizacion-ia, null
- tone              = fields.tone.stringValue, OPCIONAL
                      Si vacío, vos elegís según matriz del Apéndice B.
                      Si definido, uno de: cientifico, formal, semi_formal,
                                           anecdotico, didactico, provocativo, poetico
- desiredLength     = fields.desiredLength.stringValue, opcional
                      short | medium | long. Default: medium.
- ogImageUrl        = fields.ogImageUrl.stringValue, opcional
- desiredSlug       = fields.desiredSlug.stringValue, opcional

SEO / DISCOVERY METADATA — leé estos campos del pending; si están vacíos
generás defaults inteligentes en la Etapa C.

- focusKeyword         = REQUERIDO, fields.focusKeyword.stringValue
                         El keyword #1 que el artículo debe rankear.
                         Si es vacío, fallar este pending con motivo
                         "focusKeyword vacío — no se puede SEO-optimizar".
- seoTitle             = fields.seoTitle.stringValue, opcional
                         Si vacío, generás del title (60-65 chars, incluye focusKeyword)
- ogTitle              = fields.ogTitle.stringValue, opcional
                         Si vacío, fallback a seoTitle → title
- ogDescription        = fields.ogDescription.stringValue, opcional
                         Si vacío, fallback a metaDescription
- twitterCard          = fields.twitterCard.stringValue, opcional
                         Si vacío, default 'summary_large_image' si hay ogImage,
                         si no 'summary'
- structuredDataType   = fields.structuredDataType.stringValue, default 'BlogPosting'
                         Uno de: BlogPosting, TechArticle, OpinionPiece, NewsArticle
- crawlPolicy          = fields.crawlPolicy.stringValue, default 'index'
                         Uno de: index, noindex
- aiCrawlPolicy        = fields.aiCrawlPolicy.stringValue, default 'allow'
                         Uno de: allow, disallow
- internalTags         = fields.internalTags.arrayValue.values[].stringValue
                         Taxonomía interna para filtros y sugerencias. Puede ser []
- relatedSlugs         = fields.relatedSlugs.arrayValue.values[].stringValue
                         Cross-links manuales. Puede ser []

Si MISSING algún campo REQUERIDO, marcá ese pending como `failed` con mensaje
"Campo obligatorio faltante: ${campo}" y pasá al siguiente.

===========================================
PARTE 2 — POR CADA PENDING ARTICLE (en serie, no paralelo)
===========================================

### Paso 2.1 — Marcar como processing (lock anti-doble-procesamiento)

PATCH https://firestore.googleapis.com/v1/projects/${FIREBASE_PROJECT_ID}/databases/(default)/documents/pendingArticles/${pendingId}?updateMask.fieldPaths=status
Headers: Authorization: Bearer <idToken>, Content-Type: application/json
Body:
{
  "fields": {
    "status": { "stringValue": "processing" }
  }
}

Si esto falla con 4xx, abortá ESTE pending y pasá al siguiente.

### Paso 2.2 — PIPELINE DE GENERACIÓN (3 etapas en una sola conversación)

Mostrá las 3 etapas como texto al usuario, encabezadas por 🅐, 🅑, 🅒.

#### ===== ETAPA A — DRAFT =====

Antes de escribir el draft, hacé este orden de decisiones:

1. **Leé el `target` primero** (Apéndice F). Define vocabulario, ejemplos, dolor
   abordado, tipo de prueba social. Es la decisión más fuerte — más que `tone`.
   Reportá: "Target: ${target} — vocabulario y ejemplos calibrados a ${perfil}".

2. **Si `tone` está vacío**, elegí el óptimo según `objective` consultando
   matriz del Apéndice B. Reportá: "Tono auto-seleccionado: ${tone}".

3. **Si `tone` viene definido pero choca con `objective`** según la matriz,
   escribilo igual pero anotá la fricción en la Etapa B (no falla, queda
   constancia).

4. **Decidí structure choices** según objective + target:
   - Tipo de hook: storytelling (anécdota/escena) o afirmación (declarativa)
   - Intensidad del CTA: suave / medio / fuerte
   - Profundidad técnica: superficial (audiencia neófita) / media / profunda
   - Tipo de ejemplos: SaaS-metrics (founders), tarea-cotidiana (trabajadores),
     cliente-único (freelancers), etc. — según target.

5. Generá el draft completo siguiendo el TEMPLATE OBLIGATORIO:

   TEMPLATE OBLIGATORIO (no negociable, todos los tonos lo respetan)

   [Hero image markdown — usá ogImageUrl si vino. Si no, buscá vía WebSearch
    una imagen Unsplash relevante. Formato: ![alt](https://images.unsplash.com/photo-XXX?w=1200&q=80&fit=crop)
    Si no encontrás imagen confiable, dejá ogImage:null y omití el markdown image.]

   [Hook párrafo 1 — sin H2, ~3-5 líneas, contraste o tensión bien planteada,
    cierre con punchline corto. NUNCA arranca con "En este artículo..." ni
    "Hoy vamos a ver...".]

   ## [H2: el shift conceptual]
   [2-3 párrafos. Patrón típico: "De X a Y" o "Lo que cambió"]

   ## [H2: definición del concepto core]
   [1 párrafo introductorio + bullet list de 4-6 items.
    Cada item con **bold** en la palabra/frase líder.]

   ## [H2: cómo funciona / mecánica]
   [1-2 párrafos + diagrama ASCII en code block. EL DIAGRAMA ES OBLIGATORIO,
    no podés saltarlo. Puede ser flujo, jerarquía, o contraste lado a lado.]

   ## [H2: ángulo de negocio para founders y PyMEs]
   [Subtítulo puede variar ("Qué cambia para tu negocio", "El impacto real para
    tu operación", etc.) pero la sección es OBLIGATORIA. Acá conectás el tema
    técnico con la realidad del lector.]

   ## [H2: CTA final]
   [Si externalResourceUrl tiene valor: párrafo introductorio + link en **bold**
    a externalResourceUrl, usando externalResourceDescription como anchor text +
    frase final con link interno a /servicios.

    Si externalResourceUrl es vacío: párrafo de cierre + link interno a
    /servicios solo.

    El CTA al servicio debe nombrar la acción concreta: "agendá una llamada
    gratuita de 20 minutos", no "contactanos para más info".]

   FIN DEL TEMPLATE.

CONSTRAINTS DE LARGO según `desiredLength`:
- short:  400-500 palabras    (~3 min)
- medium: 700-900 palabras    (~5 min) ← DEFAULT, calza con artículo de referencia
- long:   1200-1500 palabras  (~8-10 min)

ESCRIBÍ EL DRAFT COMPLETO bajo el header "🅐 DRAFT".

#### ===== ETAPA B — SELF-CRITIQUE =====

Reflexioná con esta rubric. Para cada check, marcá ✓ o ✗ con explicación breve.

EJE ESTRUCTURAL:
- [ ] Hero image presente al inicio (o ogImage:null justificado)
- [ ] Hook párrafo sin H2, no arranca con "En este artículo"
- [ ] 4-5 H2 sections (incluyendo CTA final)
- [ ] Bullet list de 4-6 items con **bold** en líder
- [ ] Diagrama ASCII / code block presente (OBLIGATORIO)
- [ ] Sección de business angle "founders y PyMEs" o variante
- [ ] CTA final con link interno a /servicios
- [ ] Punchline de una línea presente al menos una vez
- [ ] Cero preámbulos / cero cierres motivacionales
- [ ] Largo dentro del rango ${desiredLength}

EJE FUNCIONAL — ¿cumple el `objective`?
- [ ] El hook engancha al perfil correcto para este objective
- [ ] La intensidad del CTA matchea el objective (consultar Apéndice B)
- [ ] El tono efectivamente sirve al objective
- [ ] Si objective="vender_producto" → CTA específico a un servicio nombrado por nombre
- [ ] Si objective="generar_leads" → problema bien construido + CTA prominente a /servicios
- [ ] Si objective="responder_objecion" → contraste explícito visible al menos 2 veces
- [ ] Si objective="aumentar_engagement" → al menos un hot take / postura clara
- [ ] Si objective="generar_confianza" → caso concreto con detalle (no abstracto)
- [ ] Si objective="demostrar_expertise" → al menos 2 fuentes citadas / referencias técnicas
- [ ] Si objective="educar_audiencia" → CTA suave, sin push de venta directo

EJE LINGÜÍSTICO:
- [ ] Voseo consistente (semi_formal/anecdotico/provocativo/didactico) o "usted" (formal)
- [ ] Sin frases de relleno ("vale destacar que", "es importante mencionar",
      "como bien sabemos")
- [ ] Analogías concretas presentes (objetos, oficios, actividades cotidianas)
- [ ] Términos técnicos en inglés explicados o usados en contexto claro

EJE TARGET — ¿el artículo le habla al perfil correcto?
- [ ] Vocabulario calibrado al target (consultar Apéndice F)
- [ ] Ejemplos del tipo correcto (founders → SaaS/equipo; trabajadores → reuniones/reportes;
      freelancers → cliente/propuesta; emprendedores → negocio chico/sin equipo;
      personas_general → vida cotidiana; estudiantes → académico)
- [ ] El dolor abordado es el dolor real del target (no el de otro perfil)
- [ ] Si target="founders_pymes" → habla de equipo, escala, métricas de negocio
- [ ] Si target="trabajadores" → habla del rol/jefe/herramientas de oficina
- [ ] Si target="personas_general" → cero jerga corporativa o startup

EJE META:
- [ ] meta description 140-180 chars
- [ ] 5-7 keywords relevantes generadas (lowercase, en español)
- [ ] readingTime calculado realista: round(palabras / 200) min

LISTÁ EXPLÍCITAMENTE qué falló y qué corrigés en Etapa C. No pases a C sin
esta lista de correcciones, aunque el draft te parezca bueno.

Reportá bajo el header "🅑 CRÍTICA".

#### ===== ETAPA C — VERSIÓN FINAL =====

Aplicá las correcciones de Etapa B. Output como JSON listo para mapear a
Firestore. Asegurate que cada campo respeta su tipo y largo.

Reportá bajo el header "🅒 ARTÍCULO FINAL" y luego un bloque JSON:

{
  "title": "...",
  "metaDescription": "...",
  "ogImage": "https://..." | null,
  "content": "[markdown completo]",
  "category": "...",
  "target": "...",
  "keywords": ["...", "...", ...],
  "readingTime": "X min",
  "author": "Javier",
  "relatedServiceId": "..." | null,
  "slug": "...",

  // SEO / discovery metadata — generá defaults si el pending no los trajo
  "focusKeyword": "...",                      // del pending, requerido
  "seoTitle": "..." | null,                   // si pending lo trajo, sino generá del title
  "ogTitle": "..." | null,                    // si pending, sino fallback a seoTitle/title
  "ogDescription": "..." | null,              // si pending, sino fallback a metaDescription
  "twitterCard": "summary_large_image" | "summary" | null,
  "structuredDataType": "BlogPosting",        // del pending o default
  "crawlPolicy": "index" | "noindex",         // del pending o default index
  "aiCrawlPolicy": "allow" | "disallow",      // del pending o default allow
  "internalTags": [...],                      // del pending o []
  "relatedSlugs": [...]                       // del pending o []
}

#### ===== ETAPA D — AUTO-GENERAR CAMPOS DE CONTENT MANAGEMENT =====

Después de tener el artículo final, computá tres campos auto. NO se piden al
admin, salen del content directamente.

1. **contentHash** = sha256(content) en hex.
   Para hacer esto sin librería, usá la API de Web Crypto desde Node si está
   disponible, o computá un hash simple. Cualquier hash determinístico de 64
   chars hex es válido. Si tu environment no tiene crypto disponible, usá
   un hash simple basado en longitud + suma de char codes — lo importante
   es que el mismo content produzca el mismo hash.

   Ejemplo de fallback aceptable (Python-ish):
   ```
   hash = sha256(content.encode('utf-8')).hexdigest()
   ```

2. **contentVersion** = 1 (siempre, para artículos nuevos creados por la rutina).
   El admin lo bumpea manualmente cuando edita después.

3. **searchTokens** = array de tokens únicos derivados de:
   - title (lowercase, split en palabras > 3 chars)
   - keywords (lowercase, sin tildes)
   - internalTags (lowercase)
   - focusKeyword (lowercase)
   Eliminá duplicados. Filtrá stopwords obvias en español ("para", "como",
   "este", "esta", "pero", "más", "los", "las", "con", "sin", "por", "que",
   "del", "una", "uno"). Resultado: 10-30 tokens únicos.

Reportá los 3 valores bajo "🅓 AUTO-FIELDS" antes del Paso 2.3.

### Paso 2.3 — Escribir el artículo a Firestore

Manejo de colisión de slug:
- Antes de escribir, hacé GET https://firestore.googleapis.com/v1/projects/${FIREBASE_PROJECT_ID}/databases/(default)/documents/articles/${slug}
  Headers: Authorization: Bearer <idToken>
- Si responde 200 → slug ocupado. Probá con sufijo "-2", luego "-3", hasta -9.
  Si todos están ocupados, fallá con "Slug colision tras 9 intentos".
- Si responde 404 → slug libre, usalo.

PATCH https://firestore.googleapis.com/v1/projects/${FIREBASE_PROJECT_ID}/databases/(default)/documents/articles/${slug}
Headers: Authorization: Bearer <idToken>, Content-Type: application/json
Body:
{
  "fields": {
    "slug":             { "stringValue":   "${slug}" },
    "title":            { "stringValue":   "${title}" },
    "metaDescription":  { "stringValue":   "${metaDescription}" },
    "ogImage":          { "stringValue":   "${ogImage}" },
    "content":          { "stringValue":   "${content}" },
    "category":         { "stringValue":   "${category}" },
    "target":           { "stringValue":   "${target}" },
    "keywords": {
      "arrayValue": { "values": [
        { "stringValue": "kw1" },
        { "stringValue": "kw2" }
      ]}
    },
    "publishedAt":      { "timestampValue": "${NOW_ISO}" },
    "updatedAt":        { "timestampValue": "${NOW_ISO}" },
    "createdAt":        { "timestampValue": "${NOW_ISO}" },
    "author":           { "stringValue":   "Javier" },
    "readingTime":      { "stringValue":   "${readingTime}" },
    "relatedServiceId": { "stringValue":   "${relatedServiceId}" },
    "published":        { "booleanValue":  false },

    // SEO core
    "focusKeyword":     { "stringValue":   "${focusKeyword}" },
    "seoTitle":         { "stringValue":   "${seoTitle}" },

    // Open Graph / social
    "ogTitle":          { "stringValue":   "${ogTitle}" },
    "ogDescription":    { "stringValue":   "${ogDescription}" },
    "twitterCard":      { "stringValue":   "${twitterCard}" },

    // Schema.org
    "structuredDataType": { "stringValue": "${structuredDataType}" },

    // Crawler diplomacy
    "crawlPolicy":      { "stringValue":   "${crawlPolicy}" },
    "aiCrawlPolicy":    { "stringValue":   "${aiCrawlPolicy}" },

    // Internal discovery
    "internalTags": {
      "arrayValue": { "values": [{ "stringValue": "tag1" }] }
    },
    "relatedSlugs": {
      "arrayValue": { "values": [{ "stringValue": "slug1" }] }
    },
    "searchTokens": {
      "arrayValue": { "values": [{ "stringValue": "token1" }] }
    },

    // Content management (auto)
    "contentHash":      { "stringValue":   "${contentHash}" },
    "contentVersion":   { "integerValue":  "1" }
  }
}

Si ogImage es null, usá { "nullValue": null } en vez de { "stringValue": ... }.
Lo mismo para relatedServiceId, seoTitle, ogTitle, ogDescription, twitterCard
cuando sean null.

Si internalTags, relatedSlugs o searchTokens están vacíos, igual incluí el
campo con arrayValue.values: [] (array vacío).

Si esto falla, ir al Paso 2.5 (failed).

### Paso 2.4 — Marcar pending como completed

PATCH https://firestore.googleapis.com/v1/projects/${FIREBASE_PROJECT_ID}/databases/(default)/documents/pendingArticles/${pendingId}?updateMask.fieldPaths=status&updateMask.fieldPaths=processedAt&updateMask.fieldPaths=resultArticleSlug&updateMask.fieldPaths=errorMessage
Body:
{
  "fields": {
    "status":            { "stringValue":    "completed" },
    "processedAt":       { "timestampValue": "${NOW_ISO}" },
    "resultArticleSlug": { "stringValue":    "${slug}" },
    "errorMessage":      { "nullValue":      null }
  }
}

### Paso 2.5 — En caso de error: marcar como failed

Si CUALQUIER paso entre 2.1 y 2.4 falla:

PATCH https://firestore.googleapis.com/v1/projects/${FIREBASE_PROJECT_ID}/databases/(default)/documents/pendingArticles/${pendingId}?updateMask.fieldPaths=status&updateMask.fieldPaths=processedAt&updateMask.fieldPaths=errorMessage
Body:
{
  "fields": {
    "status":       { "stringValue":    "failed" },
    "processedAt":  { "timestampValue": "${NOW_ISO}" },
    "errorMessage": { "stringValue":    "${msg corto y accionable}" }
  }
}

Mensajes claros: "WebSearch failed para todas las sources",
"Slug colision tras 9 intentos", "Auth token expirado", etc.

Reglas de continuación:
- Error específico al pending (sources rotas, etc.) → continuar con siguiente.
- Error sistémico (auth fail, Firestore 5xx repetido) → abortar corrida acá
  y reportar.

===========================================
PARTE 3 — REPORTE FINAL
===========================================

Al terminar (todos procesados o aborto), imprimí:

- Pendings procesados: ${count}
- Por cada uno:
   - pendingId
   - status: completed | failed
   - slug resultante (si completed)
   - objective y tono usado
   - palabras finales del artículo
   - errorMessage (si failed)
- Total escrito a /articles: ${count_completed}
- Si MAX_ARTICLES_PER_RUN saturado: "hay más pendings en cola, correr de nuevo"

===========================================
APÉNDICE A — ARTÍCULO DE REFERENCIA (estándar de calidad)
===========================================

Este es el artículo que define el estándar. NO copies palabras pero SÍ replicá:
estructura, ritmo, densidad, tipo de analogía, intensidad del CTA, formato del
diagrama, tono.

---
slug: arquitectura-skills-agenticos
title: Arquitectura de skills agénticos: el nuevo paradigma de la IA que trabaja por su cuenta
metaDescription (166 chars): Qué son los skills agénticos, cómo los agentes de IA los combinan para automatizar procesos completos, y por qué importa para tu negocio. Incluye episodio de podcast.
category: ia-aplicada
relatedServiceId: automatizacion-ia
readingTime: 5 min
keywords: ["agentes de IA", "skills agénticos", "automatización", "LLM", "herramientas IA", "Claude", "GPT"]
content (582 palabras, 5 H2):

![Diagrama conceptual de un agente de IA con múltiples skills conectados en red](https://images.unsplash.com/photo-1677442135703-1787eea5ce01?w=1200&q=80&fit=crop)

Hace dos años, cuando alguien decía "IA automatiza mi negocio" pensaba en un chatbot que respondía preguntas frecuentes. Hoy esa misma frase puede significar que un agente de IA redacta una propuesta, la envía por correo, la registra en tu CRM y agenda un seguimiento — todo sin intervención humana.

¿Qué cambió? La arquitectura.

## De modelos a agentes

Un modelo de lenguaje —GPT, Claude, Gemini— es esencialmente un motor de predicción de texto muy sofisticado. Extremadamente bueno para generar una respuesta, pero limitado a eso: texto entra, texto sale.

Un **agente** es ese mismo modelo equipado con la capacidad de elegir herramientas y ejecutar acciones en el mundo real. La diferencia es como la que hay entre saber cocinar y tener una cocina completa: el conocimiento existe, pero ahora hay instrumentos para transformarlo en resultado.

## Qué es un skill

En el vocabulario agéntico, un **skill** (también llamado tool o herramienta) es una capacidad concreta y acotada que el agente puede invocar:

- **Buscar en la web** — consulta fuentes externas antes de responder
- **Leer un documento PDF** — extrae información de contratos, facturas, manuales
- **Ejecutar código** — corre cálculos, genera reportes, manipula datos
- **Enviar un correo** — actúa sobre el mundo, no solo lo describe
- **Consultar tu base de datos** — accede a inventario, clientes, pedidos en tiempo real
- **Llamar a una API externa** — conecta con Shopify, HubSpot, tu sistema de facturación

Cada skill es atómico: hace una cosa bien. El agente decide cuándo y cómo combinarlos.

## Cómo se construye la arquitectura

La clave conceptual es que el modelo de lenguaje actúa como **orquestador**: recibe un objetivo ("prepara el resumen mensual de ventas y envíaselo al equipo"), razona qué pasos necesita ejecutar, invoca los skills en el orden correcto, procesa los resultados intermedios y continúa hasta completar la tarea.

```
Objetivo
   ↓
[Agente — LLM]
   ↓ elige skill
[Consultar BD de ventas]  →  datos crudos
   ↓ procesa resultado
[Agente — LLM]
   ↓ elige skill
[Generar reporte]  →  PDF
   ↓
[Agente — LLM]
   ↓ elige skill
[Enviar email con adjunto]  →  ✓ entregado
```

Lo que hace poderosa esta arquitectura es su **componibilidad**: cada skill nuevo que agregás expande exponencialmente lo que el agente puede hacer. No reescribís el agente — solo le entregás un instrumento más.

## Por qué importa para founders y PyMEs

La promesa no es solo eficiencia, aunque eso es real. La promesa más interesante es que los skills permiten **especializar** un agente en los procesos exactos de tu negocio:

- Un skill que conoce tu catálogo de productos
- Un skill que entiende tus reglas de descuento
- Un skill que puede hablar con tu proveedor de logística

Juntos, forman un agente capaz de manejar una consulta de cliente de punta a punta — con el conocimiento específico de tu operación, no con respuestas genéricas.

El costo marginal de agregar inteligencia a un proceso existente se está acercando a cero. Lo que antes requería un equipo de desarrollo dedicado hoy puede construirse en días.

## Escuchá el episodio completo

Grabé un podcast donde exploro en detalle cómo funcionan estas arquitecturas, con ejemplos concretos de implementación para negocios latinoamericanos, y qué se necesita realmente para empezar.

**[→ Escuchar el episodio en Google Drive](https://drive.google.com/...)**

Si querés explorar cómo una arquitectura agéntica podría automatizar procesos de tu negocio, [agendá una llamada gratuita de 20 minutos](/servicios) y lo vemos juntos.
---

===========================================
APÉNDICE B — MATRIZ OBJECTIVE → DEFAULTS EDITORIALES
===========================================

vender_producto
  Tono default: semi_formal o didactico
  Hook: declarativo (afirmación + promesa concreta)
  CTA intensidad: FUERTE — nombrar el servicio + acción + costo de entrada/llamada
  Estructura del cierre: prueba social si la hay → CTA específico
  Trampa a evitar: vender sin demostrar capacidad

generar_leads
  Tono default: didactico o provocativo
  Hook: pregunta-problema o estadística que duele
  CTA intensidad: ALTA — link prominente a /servicios + EmailCaptureBanner natural
  Estructura del cierre: amplificar el dolor → solución → CTA
  Trampa a evitar: ser demasiado abstracto, no genera urgencia

educar_audiencia
  Tono default: didactico
  Hook: declarativo o pregunta abierta
  CTA intensidad: SUAVE — "si querés profundizar..." al final
  Estructura del cierre: resumen + invitación gentil
  Trampa a evitar: meter venta cuando se prometió educación

demostrar_expertise
  Tono default: cientifico o semi_formal
  Hook: dato fuerte, paper, métrica
  CTA intensidad: BAJA-MEDIA — discreto, lo importante es la profundidad
  Estructura del cierre: insight novedoso + CTA contextual
  Trampa a evitar: profundidad falsa (lenguaje técnico sin contenido)

aumentar_engagement
  Tono default: provocativo o anecdotico
  Hook: hot take, contrarian view, escena
  CTA intensidad: MEDIA — pregunta abierta o desafío al lector
  Estructura del cierre: postura clara + invitación a discutir
  Trampa a evitar: tibio o "balanced view" que no genera reacción

generar_confianza
  Tono default: anecdotico
  Hook: caso real con detalle (cliente, número, situación)
  CTA intensidad: MEDIA — "podemos hacer lo mismo para vos"
  Estructura del cierre: lección extraída + CTA contextual
  Trampa a evitar: caso vago, sin números o detalles concretos

responder_objecion
  Tono default: didactico o provocativo
  Hook: la objeción nombrada explícitamente
  CTA intensidad: MEDIA-ALTA
  Estructura del cierre: refutación con evidencia → re-frame → CTA
  Trampa a evitar: defensivo o condescendiente con quien objeta

===========================================
APÉNDICE C — REGLAS POR TONO
===========================================

cientifico
  Voz: precisa, citas, métricas, sin metáforas decorativas
  Léxico: técnico, formal
  Pronombre: "el lector" / "uno" / impersonal
  Frases típicas: "según [fuente]", "el dato muestra que", "en X% de los casos"
  EVITAR: analogías cotidianas, exclamaciones

formal
  Voz: registro alto, sin contracciones
  Léxico: profesional, sin coloquialismos
  Pronombre: "usted" implícito o tercera persona
  Frases típicas: "es importante considerar", "como hemos visto"
  EVITAR: voseo, slang, emojis

semi_formal  ← DEFAULT del modelo de referencia
  Voz: voseo, directo, conversacional pero pulido
  Léxico: técnico mezclado con cotidiano
  Pronombre: "vos"
  Frases típicas: "imaginate", "pensalo así", punchlines de una línea
  EVITAR: jerga excesiva, formalidad acartonada

anecdotico
  Voz: primera persona, narrativo, con escenas
  Léxico: descriptivo, sensorial
  Pronombre: "yo" / "nosotros" / "vos"
  Frases típicas: "la primera vez que", "lo que pasó fue"
  EVITAR: abstracción sin caso concreto

didactico
  Voz: pedagógica, paciente, asume audiencia que aprende
  Léxico: explicativo, define términos antes de usarlos
  Pronombre: "vos"
  Frases típicas: "vamos por partes", "primero entendamos", "el siguiente paso"
  EVITAR: dar por sentado conocimiento previo

provocativo
  Voz: postura fuerte, frases cortas, contrarian
  Léxico: punzante, sin medias tintas
  Pronombre: "vos" directo
  Frases típicas: "esto es mentira", "todos te dicen X, pero", afirmaciones tajantes
  EVITAR: tibio, "depende del caso", caveats excesivos

poetico
  Voz: lírica, ritmo, metáforas extendidas
  Léxico: imaginístico, ritmico
  Pronombre: variable
  Frases típicas: imágenes evocadoras, repeticiones rítmicas
  EVITAR: usar este tono para temas operativos, queda pretencioso

===========================================
APÉNDICE D — TAXONOMÍA DE LA APP
===========================================

Categorías válidas para `category`:
- mvp           — productos en early stage, validation, pivots
- automatizacion → workflows sin humano, agentes, scripts
- contratacion  — equipo, freelancers, agencias, hiring
- ia-aplicada   — IA en uso real, casos concretos
- estrategia    — negocio, posicionamiento, decisiones
- craft         — oficio del software: arquitectura, patterns, mastery,
                  identidad de developer, filosofía de la práctica
- cultura       — industria tech, carreras, atención, dinámicas
                  laborales, controversias del sector

Servicios válidos para `relatedServiceId`:
- diagnostico
- mvp
- automatizacion-ia
- (null)

Ruta interna fija para CTA: /servicios

===========================================
APÉNDICE E — CHECKS PRE-WRITE (gate antes del PATCH)
===========================================

Antes de escribir a /articles, verificá:

CORE:
- title no vacío y < 120 chars
- metaDescription entre 140-180 chars
- content > 300 palabras (short), > 600 (medium), > 1000 (long)
- slug en kebab-case, sin tildes, sin chars especiales
- category en lista válida (incluyendo craft, cultura)
- target en lista válida (incluyendo developers)
- relatedServiceId en lista válida o null
- keywords array no vacío, entre 5 y 7 items
- ogImage es URL válida o null

SEO / DISCOVERY:
- focusKeyword no vacío (REQUERIDO)
- focusKeyword aparece literalmente en el title O en el primer párrafo del
  content (gate de SEO básico)
- seoTitle, si presente, entre 50 y 70 chars; incluye focusKeyword
- structuredDataType en {BlogPosting, TechArticle, OpinionPiece, NewsArticle}
- crawlPolicy en {index, noindex}
- aiCrawlPolicy en {allow, disallow}
- twitterCard en {summary, summary_large_image} o null
- internalTags array (puede ser vacío)
- relatedSlugs array (puede ser vacío)

CONTENT MANAGEMENT:
- contentHash es string hex de longitud > 16
- contentVersion = 1 para artículos nuevos
- searchTokens array no vacío, 10-30 tokens, lowercase

Si algún check falla, no escribas. Ir a 2.5 (failed) con motivo específico.

===========================================
APÉNDICE F — MATRIZ DE TARGETS (el más importante)
===========================================

El target define vocabulario, ejemplos y dolor abordado. Es la decisión más
fuerte de la rutina — más que tone u objective. Lo leés primero, después
calibrás todo lo demás.

founders_pymes  ← target del artículo de referencia
  Quién: founders de startup, dueños de PyMEs con equipo
  Vocabulario OK: burn rate, MVP, runway, churn, equipo, escala, automatización,
                  proveedor, ROI, contratar, despedir, due diligence
  Ejemplos típicos: "tu equipo de 5 personas", "el resumen mensual de ventas",
                    "la consulta del cliente al WhatsApp", "tu CRM"
  Dolor que duele: tiempo perdido en operativo, no escalar, costos de personal,
                   procesos rotos, depender del fundador para todo
  Prueba social útil: "una PyME chilena de retail logró X", "un SaaS B2B"
  EVITAR: condescendencia técnica, jerga puramente académica, ejemplos de
          oficina corporativa

emprendedores
  Quién: solopreneurs, micro-emprendedores, freelancers ambiciosos sin equipo
  Vocabulario OK: tu negocio, vos solo, side project, costo cero, no-code,
                  bootstrap, primer cliente, validar idea
  Ejemplos típicos: "vos manejando todo desde tu notebook", "cuando recién
                    arrancás", "sin presupuesto", "el producto es vos"
  Dolor que duele: no tener tiempo, no tener equipo, hacer todo solo,
                   primera venta cuesta, miedo a invertir
  Prueba social útil: "un emprendedor solo con $50/mes", caso de un solopreneur
  EVITAR: hablar de "tu equipo", procesos enterprise, contratación

trabajadores
  Quién: empleados en empresa, buscan productividad o upskill en su rol
  Vocabulario OK: jefe, manager, reuniones, reportes, planilla, presentación,
                  Office, Slack, email, deadline, carrera
  Ejemplos típicos: "el reporte semanal que pide tu jefe", "esa reunión de
                    los lunes", "el Excel que actualizás cada mañana"
  Dolor que duele: tareas repetitivas, micromanagement, pasar de año, falta
                   de tiempo para upskill, ansiedad por reemplazo de IA
  Prueba social útil: "un analista en una corporativa", "un account manager"
  EVITAR: hablar como dueño del negocio, decisiones de C-level, métricas
          de SaaS

freelancers
  Quién: creativos/técnicos independientes (diseño, redacción, dev, video)
  Vocabulario OK: cliente, propuesta, brief, tarifa hora, factura, portfolio,
                  revisión, scope creep, deadline del cliente, brief
  Ejemplos típicos: "ese cliente que pide 5 revisiones", "la propuesta del
                    viernes", "el brief vago", "armar tu pricing"
  Dolor que duele: clientes difíciles, tiempo facturable bajo, scope creep,
                   competencia barata, no escalar sin contratar
  Prueba social útil: "una diseñadora freelance", "un dev independiente"
  EVITAR: hablar de equipo propio, jerga corporativa, ejemplos académicos

personas_general
  Quién: uso cotidiano de IA, no laboral, no técnico
  Vocabulario OK: tu día, casa, familia, salud, viaje, comprar, planificar,
                  receta, agenda, mensajes, fotos
  Ejemplos típicos: "esa receta que querías cocinar", "armar el viaje a la
                    playa", "responder mensajes pendientes", "ayudar a tu
                    hijo con la tarea"
  Dolor que duele: agenda saturada, decisiones cotidianas, no saber por
                   dónde empezar, sentirse atrasado con la tecnología
  Prueba social útil: ejemplos de uso doméstico, anécdotas familiares
  EVITAR: jerga de negocio, jerga técnica, ejemplos laborales

estudiantes
  Quién: universitarios, aprendices, secundaria avanzada
  Vocabulario OK: profesor, curso, examen, ensayo, paper, tesis, apunte,
                  bibliografía, fecha de entrega, grupo, monografía
  Ejemplos típicos: "ese ensayo de 10 páginas para el viernes", "estudiar
                    para el parcial", "sintetizar 3 papers", "armar la tesis"
  Dolor que duele: procrastinar, sintetizar volumen de info, no entender
                   un tema, plazos cortos, ChatGPT mal usado castigado por profe
  Prueba social útil: "un estudiante de ingeniería", "una tesista de
                      humanidades"
  EVITAR: jerga de negocio, ejemplos laborales adultos

developers
  Quién: developers/engineers que escriben código profesionalmente
         (empleados, freelance, founders técnicos). Audiencia que se preocupa
         por craft, tooling, identidad profesional del oficio.
  Vocabulario OK: code, debug, prod, refactor, legacy, deploy, stack, branch,
                  framework, IDE, terminal, bug, build, PR, merge, CI/CD,
                  Docker, observabilidad, schema, endpoint
  Ejemplos típicos: "ese bug en producción a las 3am", "el legacy que
                    heredaste del que se fue", "el refactor del viernes que
                    rompió todo", "el Dockerfile de 200 líneas"
  Dolor que duele: legacy hostil, fragmentación de atención, deuda técnica,
                   imposter syndrome, identidad profesional bajo presión IA,
                   reuniones que matan flow, tech debt vs feature pressure
  Prueba social útil: anécdotas de prod, casos reales con código, autores
                      respetados (Fowler, Uncle Bob, Cockburn, Newport)
  EVITAR: jerga 100% corporate (jefe, manager), ejemplos no-técnicos
          (cocinar, viaje), condescendencia hacia el oficio

REGLA TRANSVERSAL: si el target es uno y los ejemplos son de otro, el artículo
falla en Etapa B. El target es el filtro que separa contenido que conecta de
contenido genérico.
````

---

## Schema de `pendingArticles` (todavía sin crear)

```ts
type PendingArticle = {
  // Mandatorios
  objective: 'vender_producto' | 'generar_leads' | 'educar_audiencia'
           | 'demostrar_expertise' | 'aumentar_engagement'
           | 'generar_confianza' | 'responder_objecion';
  target: 'founders_pymes' | 'emprendedores' | 'trabajadores'
        | 'freelancers' | 'personas_general' | 'estudiantes';
  topic: string;             // 1-2 frases del qué
  angle: string;             // tesis única del artículo
  category: 'mvp' | 'automatizacion' | 'contratacion' | 'ia-aplicada' | 'estrategia';

  // Opcionales — guían al modelo
  keyPoints?: string[];      // 3-5 bullets must-have
  sources?: string[];        // URLs a citar/consultar

  // External resource para el CTA — flat fields (3 campos opcionales)
  externalResourceType?: 'podcast' | 'video' | 'document' | 'tool' | '';
  externalResourceUrl?: string;
  externalResourceDescription?: string;  // anchor text del CTA

  relatedServiceId?: 'diagnostico' | 'mvp' | 'automatizacion-ia' | null;

  // Overrides opcionales
  tone?: 'cientifico' | 'formal' | 'semi_formal'
       | 'anecdotico' | 'didactico' | 'provocativo' | 'poetico';
  desiredLength?: 'short' | 'medium' | 'long';
  ogImageUrl?: string;
  desiredSlug?: string;

  // Estado interno (no lo seteás vos, lo maneja la rutina)
  status: 'pending' | 'processing' | 'completed' | 'failed';
  createdAt: Timestamp;
  processedAt: Timestamp | null;
  resultArticleSlug: string | null;
  errorMessage: string | null;
};
```

## Próximos pasos

1. **Vos**: probás esta rutina con un pending de prueba (después de que la
   colección exista).
2. **Yo**: creo la colección `pendingArticles` con sus reglas de Firestore.
3. **Yo**: agrego el panel CRUD al dashboard de admin.
4. Iteramos sobre la rutina con resultados reales.
