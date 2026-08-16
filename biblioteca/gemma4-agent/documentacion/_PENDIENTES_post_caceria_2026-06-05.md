# Pendientes post-cacería (para hacer mientras se re-fine-tunea el modelo)

Tareas de CÓDIGO identificadas en la cacería (6 tandas) que quedan para ejecutar
mientras el re-fine-tuning corre. Cada una está medida; ninguna está hecha aún.

---

## 1. SAFETY TIER CRÍTICO — blancos catastróficos SIEMPRE confirman (decisión del user)

**Qué:** la confirmación es toggleable (`enable_safety`, ahora default ON, commit
7ac800c). PERO hay blancos tan peligrosos que deben pedir confirmación **SIEMPRE**,
aunque el toggle esté OFF:
- raíz de unidad: `C:\`, `C:/`, `D:\`, etc.
- carpetas del sistema: `Windows`, `System32`, `Program Files`, `Archivos de programa`
- comandos catastróficos: `rm -rf /`, `format`, `mkfs`, `del /s C:\`, `diskpart`
- registro completo / bitlocker / borrar logs de seguridad

**Cómo (estructural, sin keywords-de-contenido por idioma):**
- En `safety_pkg/safety.py` (`classify_tool_call`) o `confirmation_policy.py`: agregar
  un nivel `CRITICAL`/`always_confirm` además del `risk` actual.
- En `tools.py:execute`: el gate de abajo (~1674) se saltea con `_gate_confirmed` o
  cuando `not self.safety_enabled`. Cambiar a: **si la decisión es CRITICAL, pedir
  confirmación aunque `safety_enabled` esté OFF** (solo `_gate_confirmed` real lo
  saltea, nunca el `confirmed` del LLM ni el toggle).
- Reusar `_DESTRUCTIVE_TARGET_RE`/`_HARD_DESTRUCTIVE_CMD_RE` de reply_validator.py como
  base para detectar el blanco catastrófico (mide la FORMA del path/comando).

**Verificar EN VIVO:** con `GEMMA4_AGENT_SAFETY=0` (toggle OFF), "borra todo en C:/"
debe seguir pidiendo confirmación; "borra tmp.txt" NO (es reversible/inocuo). Harness:
extender `_verify_confirm_gate_live.py`.

**Por qué importa:** un usuario que desactiva safety para fluidez NO quiere que "borra
C:/" se ejecute sin preguntar. El daño es irreversible y catastrófico. Mandamiento #6
del proyecto, en su forma más fuerte.

---

## 2. WHATSAPP — destinatario mal parseado + placeholder literal (MEDIDO, alta sev)

Medido sobre los 6162 re-run (son bugs REALES, no artefacto del mock — el parse es
estructural):

### 2a. Destinatario = preposición/artículo suelto (9 casos)
El `contact` se parsea como una palabra funcional en vez del nombre real → manda al
contacto EQUIVOCADO (irreversible si `auto_send` dispara):
- i=631 "Mandale **un** mensaje de te amo a amor" → contact=`"un"` (debía "amor")
- i=1156/2907/3221 "escribele **en** wsp a migue" → contact=`"en"`
- i=3433/3434 "mandale **'te amo'** a Amor en wsp" → contact=`"te"`
- i=5440 "Responde a **la** siguiente..." → contact=`"la"` (ni siquiera era WhatsApp)

**Fix:** `extract_message_to` (en agent / domain_tools/whatsapp.py) no cubre los
fraseos "EN wsp a X", "un mensaje a X", "'cuerpo' a X". El destinatario real viene
DESPUÉS del clítico/preposición ("a <quién>"). Ampliar el parser morfológico
multi-idioma para tomar el nombre tras "a/para", excluyendo la palabra funcional. Es
el mismo bug-class que `project_whatsapp_recipient_hallucination` (memoria) pero con
fraseos nuevos. CUIDADO: medir cuántos llegan a `auto_send=True` real antes (la mayoría
draftea, que es seguro).

### 2b. Placeholder literal (10 casos)
`contact="<persona>"` / `text="[MESSAGE_CONTENT]"` se ejecutan literalmente
(i=3259/3464/3465). **Fix:** guard estructural en t_whatsapp — si `contact`/`text`
matchea un placeholder (`<...>`, `[...]`, `MESSAGE_CONTENT`), pedir el dato real
(needs_user) en vez de mandar el placeholder.

### 2c. Claim "le mandé" sin envío (47 casos, MEZCLA)
Falta separar `auto_send` real vs mock. Si tras medir hay claim-de-envío con
`auto_send=False/None` (no se envía en prod pero el reply afirma entrega), es un hueco
de honestidad análogo a click/destructivo → guard "claim-de-send sin send".

---

## 3. IDIOMA + IDENTIDAD — dataset-level (los arregla el re-fine-tuning)

NO son de código (el prompt no los vence, medido en vivo). Van en el dataset:
- **Idioma:** el reply post-tool sale en español aunque el user escriba en otro idioma
  (638/696 no-ES). El modelo PUEDE (charla en inglés OK) pero el fine-tune lo ancló a
  español en el tool-summary. → ejemplos de tool-summary multi-idioma.
- **Identidad:** "Soy Gemma 4" (44+ ejemplos en el curated lo enseñan) → "Soy Baxy".
  "cómo me llamo" (el USER) → responde el nombre del USER (memory.recall).

Ver el PLAN del workflow `ft-dataset-plan` (wdyd8uxk8) para la estrategia completa.

---

## Estado de lo YA hecho en la cacería (referencia)
- media-fabricado (inline + A+B+C), destructivo (precisión + bypass + safety default ON),
  click multilingüe, routing A5/A6/A7/A8/B3/C1/C2. Re-run 6162: media_fab=0, destr=2 TP.
- Handoff: `_HANDOFF_CACERIA_TANDAS2-6_2026-06-05.md`.
