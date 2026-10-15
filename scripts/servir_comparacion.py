# GUÍA DE LECTURA · scripts/servir_comparacion.py
# API de demostración para isbetter.ai en 127.0.0.1:1235 por defecto.
# Dos nombres visibles comparten la misma base: original y base con LoRA.
# El bloqueo impide cambiar el estado del adaptador durante otra generación.
# HTTP puede atender varias conexiones, pero la inferencia es una a una.
# CORS y Host restringen acceso; los semáforos limitan conexiones y consultas en espera.
# No es un servidor público ni un benchmark de velocidad entre condiciones.

"""API local para comparar el mismo Qwen con y sin el adaptador de soporte.

Una sola instancia, inferencia serializada y parámetros del experimento congelado.
No modifica datos, pesos ni resultados. CORS limitado a isbetter.ai.
"""

# Hace visible la raíz del proyecto al ejecutar un archivo desde scripts/.
import _bootstrap  # noqa: F401

# Permite leer opciones de la terminal y generar ayuda del comando.
import argparse

# Convierte entre texto JSON y diccionarios/listas Python, manteniendo respuestas como evidencia.
import json

# Hilos, locks y semáforos permiten atender HTTP y coordinar el modelo compartido.
import threading

# Mide duración y prepara fechas; perf_counter/monotonic sirven para intervalos, no fechas del calendario.
import time

# Genera identificadores distintos para las respuestas de chat.
import uuid

# Context managers cierran/restauran recursos al salir, también cuando hay errores.
from contextlib import nullcontext

# Servidor HTTP de la biblioteca estándar para la demo en loopback.
from http.server import BaseHTTPRequestHandler, ThreadingHTTPServer

# Path permite construir rutas, comprobar archivos y leer/escribir sin concatenar separadores a mano.
from pathlib import Path

# Separa ruta, hostname y puerto antes de decidir si una petición está autorizada.
from urllib.parse import urlsplit

# Reutiliza funciones del núcleo compartido para mantener el mismo protocolo entre scripts.
from curso.common import ROOT, MODEL_ID, REVISION, GENERATION, assert_frozen, digest


# Dos alias de la misma base; activar/desactivar LoRA es la única diferencia de pesos.
MODEL_IDS = ("qwen-original", "qwen-lora-soporte")
# Único origen de navegador autorizado a consultar esta demo local.
ALLOWED_ORIGIN = "https://isbetter.ai"


# Valida el cuerpo recibido de isbetter y devuelve nombre de modelo y mensajes.
# Impide cambiar parámetros que romperían la comparación del experimento.
def validate_request(body):
    # Solo se sirven los dos alias de la comparación.
    if not isinstance(body, dict) or body.get("model") not in MODEL_IDS:
        # Error 400: modelo desconocido para esta demo.
        raise ValueError("Selecciona qwen-original o qwen-lora-soporte")
    # Extrae mensajes del cuerpo HTTP; se validarán roles, longitud y contenido.
    messages = body.get("messages")
    # Entre 1 y 24 mensajes: limita el tamaño de la conversación que llega al modelo.
    if not isinstance(messages, list) or not 1 <= len(messages) <= 24:
        # Error 400: lista ausente, vacía o demasiado larga.
        raise ValueError("messages debe contener entre 1 y 24 mensajes")
    # Valida cada mensaje antes de enviarlo a la plantilla/tokenizer del modelo.
    for message in messages:
        # Solo roles de chat estándar: system, user o assistant.
        if not isinstance(message, dict) or message.get("role") not in (
            "system",
            "user",
            "assistant",
        ):
            # Error 400: rol desconocido o mensaje que no es un objeto.
            raise ValueError("Rol de mensaje no admitido")
        # content debe ser texto con algún carácter visible; no se admiten imágenes ni listas.
        if (
            not isinstance(message.get("content"), str)
            or not message["content"].strip()
        ):
            # Error 400: contenido vacío o que no es texto.
            raise ValueError("Solo se admiten mensajes de texto no vacíos")
    # El modelo responde al último turno, que debe ser del usuario.
    if messages[-1]["role"] != "user":
        # Error 400: no hay ninguna pregunta del usuario que responder.
        raise ValueError("El último mensaje debe ser del usuario")
    # Se aceptan ausentes o con el valor del experimento; otro valor cambiaría la comparación.
    if body.get("temperature") not in (None, 0) or body.get("max_tokens") not in (
        None,
        GENERATION["max_new_tokens"],
    ):
        # Error 400: parámetros distintos de los del experimento.
        raise ValueError("La comparación fija temperature=0 y max_tokens=180")
    # Sin herramientas, sin JSON mode y una sola respuesta (n=1), como en el protocolo.
    if body.get("tools") or body.get("response_format") or body.get("n", 1) != 1:
        # Error 400: herramientas, formato impuesto o varias respuestas.
        raise ValueError("JSON como texto, sin tools ni formato impuesto")
    # stream decide si la respuesta llega por fragmentos (SSE) o completa.
    if not isinstance(body.get("stream", False), bool):
        # Error 400: stream con un valor que no es true/false.
        raise ValueError("stream debe ser booleano")
    # Alias del modelo y mensajes ya validados.
    return body["model"], messages


# Motor compartido de Qwen: una instancia y dos condiciones de adaptador.
class ComparisonEngine:
    # Carga una base con su adaptador y prepara el lock y la identidad del motor.
    def __init__(self, adapter):
        # Verifica la identidad del experimento antes de servir las dos condiciones.
        assert_frozen()
        # Resuelve la ruta del adaptador elegido para este servidor.
        adapter = Path(adapter).resolve()
        # Lee la configuración PEFT para comprobar compatibilidad con la base del experimento.
        config = json.loads(
            (adapter / "adapter_config.json").read_text(encoding="utf-8")
        )
        # El adaptador debe haberse entrenado sobre el mismo Qwen y sin tocar los bias:
        # así, desactivarlo devuelve exactamente la base original.
        if (
            config["base_model_name_or_path"] != MODEL_ID
            or config.get("bias") != "none"
        ):
            # Detiene el arranque del servidor con un mensaje claro.
            raise ValueError(
                "El adaptador debe pertenecer al mismo Qwen y no modificar bias"
            )
        # Misma función de carga que usan demo.py y evaluar_qwen.py.
        from curso.qwen import load_qwen

        # Carga una única base con LoRA que ambas condiciones compartirán bajo el lock.
        self.model, self.tokenizer, self.device = load_qwen(str(adapter))
        # Exclusión mutua: ninguna consulta cambia el adaptador mientras otra sigue generando.
        self.lock = threading.Lock()
        # Identifica modelo/revisión/hash del adaptador en /health para relacionar una respuesta con sus pesos.
        self.metadata = {
            # Modelo base y revisión exactos.
            "base_model": MODEL_ID,
            "revision": REVISION,
            # Huella (SHA-256) de los pesos del adaptador cargado.
            "adapter_sha256": digest(adapter / "adapter_model.safetensors"),
            # Dispositivo donde se ejecuta (cuda, mps o cpu).
            "device": self.device,
            # Parámetros de generación del experimento.
            "generation": GENERATION,
            "enable_thinking": False,
            # Recordatorio: las peticiones se atienden de una en una.
            "inference": "serializada; ambas opciones comparten el mismo modelo",
        }

    # Produce fragmentos de respuesta y un último evento de consumo/parada.
    # El lock abarca generación y restauración del adaptador para aislar las dos condiciones.
    def events(self, model_id, messages):
        # Motor de tensores y gradientes; durante inferencia se desactivan los gradientes.
        import torch

        # TextIteratorStreamer entrega texto mientras se genera; StoppingCriteria permite cortar la generación.
        from transformers import (
            TextIteratorStreamer,
            StoppingCriteria,
            StoppingCriteriaList,
        )

        # Misma plantilla de chat que en entrenamiento e inferencia.
        from curso.qwen import render

        # Señal compartida para pedir al worker que deje de generar cuando termina o se cierra el consumidor.
        cancelled = threading.Event()

        # Criterio de parada que consulta una señal compartida entre consumidor y worker.
        class Cancelled(StoppingCriteria):
            # Comprueba la señal de cancelación entre pasos de generación y permite detener el worker.
            def __call__(self, input_ids, scores, **kwargs):
                # True detiene la generación en el siguiente token; False la deja continuar.
                return cancelled.is_set()

        # Serializa desde el formateo hasta la restauración del estado PEFT, también durante streaming:
        # isbetter envía las dos peticiones a la vez, pero una nunca cambia el adaptador de la otra.
        with self.lock:
            # Mensajes recibidos convertidos en texto con la plantilla de Qwen.
            text = render(self.tokenizer, messages)
            # Tokeniza el contexto completo y mueve sus tensores al dispositivo del modelo.
            inputs = self.tokenizer(
                text, return_tensors="pt", add_special_tokens=False
            ).to(self.device)
            # Número de tokens de entrada, separado de los tokens nuevos de respuesta.
            prompt_tokens = inputs["input_ids"].shape[1]
            # Prompt más respuesta máxima no pueden superar el contexto de 4096 tokens de esta demo.
            if prompt_tokens + GENERATION["max_new_tokens"] > 4096:
                # Detiene la petición con un error 400 antes de generar.
                raise ValueError(
                    "La consulta supera el contexto de 4096 tokens de esta demo"
                )
            # Cola de fragmentos decodificados que comunica el worker de generación con el consumidor HTTP.
            streamer = TextIteratorStreamer(
                self.tokenizer, skip_prompt=True, skip_special_tokens=True, timeout=120
            )
            # Listas de comunicación del worker: tokens finales o excepción, sin perder el error real.
            completed, errors = [], []

            # Worker de inferencia: selecciona original/LoRA, genera y comunica tokens o excepción al consumidor.
            def generate():
                # try/except: cualquier fallo de generación se guarda para el hilo que responde.
                try:
                    # Original desactiva temporalmente LoRA; la otra condición conserva el adaptador cargado.
                    context = (
                        self.model.disable_adapter()
                        if model_id == MODEL_IDS[0]
                        else nullcontext()
                    )
                    # El contexto restaura el estado del adaptador al salir y no se calculan gradientes durante inferencia.
                    with context, torch.inference_mode():
                        # Genera con los parámetros congelados; el streamer recibe el texto según se produce.
                        output = self.model.generate(
                            **inputs,
                            **GENERATION,
                            streamer=streamer,
                            pad_token_id=self.tokenizer.eos_token_id,
                            stopping_criteria=StoppingCriteriaList([Cancelled()]),
                        )
                    # Conserva solo tokens nuevos, separándolos del prompt, para calcular el consumo final.
                    completed.append(output[0, prompt_tokens:])
                # Cualquier error (memoria, dispositivo…) se captura aquí.
                except Exception as exc:
                    # Propaga la excepción del worker al hilo que responde HTTP.
                    errors.append(exc)
                    # Desbloquea al consumidor del streamer cuando la generación terminó con error.
                    streamer.end()

            # Generación y lectura de fragmentos ocurren en hilos separados; el lock sigue protegiendo la base compartida.
            worker = threading.Thread(target=generate, daemon=True)
            # Arranca generación en segundo plano; el hilo actual puede enviar fragmentos conforme llegan.
            worker.start()
            # try/finally: aunque el navegador se desconecte, se cancela y se espera al worker.
            try:
                # Recibe fragmentos de texto conforme el worker de generación los produce.
                for fragment in streamer:
                    # Omite fragmentos vacíos del streamer sin modificar los fragmentos con texto.
                    if fragment:
                        # Entrega un fragmento sin ensamblar todavía toda la respuesta.
                        yield {"content": fragment}
            finally:
                # Solicita detener pasos posteriores si el consumidor se cierra o sale del bucle.
                cancelled.set()
                # Espera a que el worker termine: el lock no se libera mientras el adaptador sigue desactivado.
                worker.join()
            # Tras esperar al worker, comunica su fallo en lugar de fingir una respuesta correcta.
            if errors:
                # Relanza el error original del worker en este hilo.
                raise errors[0]
            # Cantidad de tokens de respuesta utilizados para informar consumo y motivo de parada.
            count = len(completed[0])
            # Evento final: length si se agotó el límite de 180 tokens, stop si el modelo terminó antes.
            yield {
                # length = se agotó el límite de tokens; stop = el modelo terminó por sí mismo.
                "finish_reason": "length"
                if count >= GENERATION["max_new_tokens"]
                else "stop",
                # Tokens de la consulta, con los nombres de la API de OpenAI.
                "usage": {
                    "prompt_tokens": prompt_tokens,
                    "completion_tokens": count,
                    "total_tokens": prompt_tokens + count,
                },
            }


# Servidor de hilos HTTP con límites independientes de conexiones e inferencias en espera.
class ComparisonServer(ThreadingHTTPServer):
    # Los hilos HTTP no impiden por sí solos que termine el proceso del servidor.
    daemon_threads = True
    # Tamaño de la cola de conexiones del socket antes de atenderlas en hilos.
    request_queue_size = 8

    # Inyecta el motor, crea los límites de concurrencia y registra el handler HTTP.
    def __init__(self, address, engine):
        # Inyecta el motor real o el simulado de tests, conservando el mismo contrato HTTP.
        self.engine = engine
        # Como máximo 16 conexiones atendidas/en curso; se rechaza el exceso sin crear otro hilo.
        self.request_slots = threading.BoundedSemaphore(16)
        # Como máximo cuatro consultas en generación o espera; no implica cuatro inferencias simultáneas.
        self.inference_slots = threading.BoundedSemaphore(4)
        # Inicializa el servidor base y asigna ComparisonHandler como manejador de conexiones.
        super().__init__(address, ComparisonHandler)

    # Reserva una plaza HTTP sin bloquear; si no hay capacidad devuelve 503.
    # Una excepción al crear el hilo devuelve la plaza al semáforo.
    def process_request(self, request, client_address):
        # Reserva plaza sin bloquear; rechaza nuevas conexiones cuando ya hay 16 en curso.
        if not self.request_slots.acquire(blocking=False):
            # try/finally: el socket se cierra aunque falle el envío.
            try:
                # Limita a un segundo la escritura de la respuesta de saturación.
                request.settimeout(1)
                # Informa HTTP 503 sin cuerpo y pide cerrar la conexión rechazada.
                request.sendall(
                    b"HTTP/1.0 503 Service Unavailable\r\nContent-Length: 0\r\nConnection: close\r\n\r\n"
                )
            finally:
                # Cierra el socket rechazado aunque falle enviar la respuesta.
                self.shutdown_request(request)
            # Conexión rechazada: no se crea hilo para ella.
            return
        # try/except: si crear el hilo falla, la plaza se devuelve.
        try:
            # Delega en ThreadingHTTPServer la creación del hilo para esta conexión.
            super().process_request(request, client_address)
        # Fallo al crear el hilo de esta conexión.
        except Exception:
            # Devuelve la plaza al semáforo para que una petición posterior pueda utilizarla.
            self.request_slots.release()
            # Relanza el error original tras liberar la plaza.
            raise

    # Atiende la conexión y libera siempre su plaza HTTP cuando termina.
    def process_request_thread(self, request, client_address):
        # try/finally: la plaza se devuelve aunque el handler falle.
        try:
            # Ejecuta el handler heredado; el finally posterior devuelve la plaza HTTP.
            super().process_request_thread(request, client_address)
        finally:
            # Devuelve la plaza al semáforo para que una petición posterior pueda utilizarla.
            self.request_slots.release()


# Traduce peticiones HTTP a llamadas del motor y devuelve JSON o eventos SSE.
class ComparisonHandler(BaseHTTPRequestHandler):
    # Prepara la conexión heredada y limita cuánto puede esperar cada lectura.
    def setup(self):
        # Inicializa streams de lectura/escritura del handler antes de fijar timeout.
        super().setup()
        # Evita mantener indefinidamente una conexión con lecturas detenidas.
        self.connection.settimeout(15)

    # Registra método/estado del servidor; no añade prompts ni cuerpos HTTP al log.
    def log_message(self, fmt, *args):
        # Línea de log de BaseHTTPRequestHandler (método, ruta y estado); nunca prompts ni cuerpos.
        print(fmt % args, flush=True)

    # Acepta el origen de isbetter o una petición sin Origin, como curl local.
    def origin_allowed(self):
        # True si no hay cabecera Origin o si es exactamente https://isbetter.ai.
        return self.headers.get("Origin") in (None, ALLOWED_ORIGIN)

    # Comprueba Host de loopback con el puerto correcto además del Origin.
    # Un dominio externo apuntando a 127.0.0.1 no obtiene acceso por ser loopback.
    def request_allowed(self):
        # Evita que un hostname externo resuelto a loopback se trate como local.
        try:
            # Componentes del Host separados para comprobar nombre, puerto y ausencia de credenciales.
            destination = urlsplit("//" + self.headers.get("Host", ""))
            # True solo si Host es localhost/127.0.0.1 con el puerto de este servidor y nada más.
            local = (
                # Nombre de máquina local,
                destination.hostname in ("localhost", "127.0.0.1")
                # puerto de este servidor,
                and destination.port == self.server.server_port
                # sin usuario ni contraseña en el Host
                and destination.username is None
                and destination.password is None
                # y sin ruta, consulta ni fragmento: solo nombre y puerto.
                and not destination.path
                and not destination.query
                and not destination.fragment
            )
        # urlsplit lanza ValueError ante un puerto inválido.
        except ValueError:
            # Un Host mal formado (por ejemplo, puerto no numérico) se trata como no local.
            local = False
        # Hace falta Host local y, además, Origin ausente o isbetter.ai.
        return local and self.origin_allowed()

    # Añade permisos CORS solo para el origen autorizado; otros no reciben esa cabecera.
    def cors_headers(self):
        # Solo añade CORS si el navegador envió exactamente el origen permitido.
        if self.headers.get("Origin") == ALLOWED_ORIGIN:
            # Autoriza exclusivamente a isbetter.ai; no utiliza un comodín.
            self.send_header("Access-Control-Allow-Origin", ALLOWED_ORIGIN)
            # Indica que la respuesta depende del Origin de la petición.
            self.send_header("Vary", "Origin")

    # Serializa payload, envía estado/cabeceras y escribe los bytes de la respuesta HTTP.
    def send_json(self, status, payload):
        # Serializa el objeto y lo codifica en UTF-8 para enviar bytes por HTTP.
        data = json.dumps(payload, ensure_ascii=False).encode()
        # Envía el código HTTP antes de las cabeceras y del cuerpo.
        self.send_response(status)
        # Añade permisos del navegador solo si corresponde al origen validado.
        self.cors_headers()
        # El cuerpo es un JSON completo en UTF-8.
        self.send_header("Content-Type", "application/json; charset=utf-8")
        # Declara la cantidad exacta de bytes de la respuesta JSON completa.
        self.send_header("Content-Length", str(len(data)))
        # Evita que las respuestas de la demo se almacenen en caché HTTP.
        self.send_header("Cache-Control", "no-store")
        # Cierra las cabeceras; a partir de aquí se escribe el cuerpo de respuesta.
        self.end_headers()
        # Envía al cliente los bytes del JSON ya serializado.
        self.wfile.write(data)

    # Responde a la comprobación previa CORS del navegador, sin ejecutar el modelo.
    def do_OPTIONS(self):
        # Comprueba Host y Origin antes de descubrir modelos o ejecutar consultas.
        if not self.request_allowed():
            # Rechaza el origen/destino con un error controlado y sin iniciar inferencia.
            self.send_json(403, {"error": {"message": "Origen no admitido"}})
            # Fin de la respuesta: no se procesa nada más.
            return
        # Envía el código HTTP antes de las cabeceras y del cuerpo.
        self.send_response(204)
        # Añade permisos del navegador solo si corresponde al origen validado.
        self.cors_headers()
        # Declara los tres métodos admitidos para el preflight del navegador.
        self.send_header("Access-Control-Allow-Methods", "GET, POST, OPTIONS")
        # Permite las cabeceras usadas por el cliente compatible de isbetter.
        self.send_header("Access-Control-Allow-Headers", "Content-Type, Authorization")
        # Responde a la comprobación de acceso a red privada que puede pedir el navegador.
        self.send_header("Access-Control-Allow-Private-Network", "true")
        # Cierra las cabeceras; a partir de aquí se escribe el cuerpo de respuesta.
        self.end_headers()

    # Sirve /v1/models para descubrir las dos condiciones y /health para identificar el adaptador.
    def do_GET(self):
        # Comprueba Host y Origin antes de descubrir modelos o ejecutar consultas.
        if not self.request_allowed():
            # Rechaza el origen/destino con un error controlado y sin iniciar inferencia.
            self.send_json(403, {"error": {"message": "Origen no admitido"}})
            # Fin de la respuesta: no se procesa nada más.
            return
        # Extrae la ruta HTTP sin mezclar query string con la selección de endpoint.
        path = urlsplit(self.path).path
        # Endpoint de descubrimiento: devuelve los dos alias de una base y su estado de adaptador.
        if path == "/v1/models":
            # Catálogo con el formato de /v1/models de la API de OpenAI.
            self.send_json(
                200,
                {
                    # Formato de lista de la API de OpenAI.
                    "object": "list",
                    "data": [
                        {
                            # Alias que elige isbetter.ai.
                            "id": name,
                            "object": "model",
                            "owned_by": "Qwen",
                            # Ambos alias comparten la misma base.
                            "base_model": MODEL_ID,
                            # True solo para qwen-lora-soporte.
                            "adapter_enabled": name == MODEL_IDS[1],
                        }
                        for name in MODEL_IDS
                    ],
                },
            )
        # Endpoint de identidad: revisión, hash del adaptador y configuración realmente cargada.
        elif path == "/health":
            # Estado listo y metadatos del motor: revisión, hash del adaptador, dispositivo…
            self.send_json(
                200,
                {"status": "ready", "models": MODEL_IDS, **self.server.engine.metadata},
            )
        else:
            # Devuelve ruta desconocida; no ejecuta ningún comportamiento alternativo.
            self.send_json(404, {"error": {"message": "Ruta no encontrada"}})

    # Valida la consulta, limita la cola y responde con JSON completo o streaming SSE.
    # Libera recursos aunque el navegador se desconecte o la inferencia falle.
    def do_POST(self):
        # Comprueba Host y Origin antes de descubrir modelos o ejecutar consultas.
        if not self.request_allowed():
            # Rechaza el origen/destino con un error controlado y sin iniciar inferencia.
            self.send_json(403, {"error": {"message": "Origen no admitido"}})
            # Fin de la respuesta: no se procesa nada más.
            return
        # Solo admite generación en /v1/chat/completions.
        if urlsplit(self.path).path != "/v1/chat/completions":
            # Devuelve ruta desconocida; no ejecuta ningún comportamiento alternativo.
            self.send_json(404, {"error": {"message": "Ruta no encontrada"}})
            # Fin de la respuesta: no se procesa nada más.
            return
        # Marca si ya se enviaron cabeceras de streaming; después solo puede notificarse el error dentro del flujo.
        started = False
        # Generador del motor: produce texto y un último evento con consumo y motivo de parada.
        events = None
        # Indica si esta petición reservó una plaza de inferencia, para liberarla exactamente una vez.
        acquired = False
        # try/except/finally: cualquier error se responde y siempre se liberan los recursos.
        try:
            # Cantidad de bytes declarada para el cuerpo; se valida antes de leerlo.
            length = int(self.headers.get("Content-Length", "0"))
            # Cuerpo vacío o mayor de 64 KiB: se rechaza antes de leerlo.
            if not 0 < length <= 65536:
                # Error 400 antes de leer el cuerpo.
                raise ValueError("Tamaño de petición no admitido")
            # Lee el cuerpo dentro del límite de 64 KiB y lo convierte a un objeto Python.
            body = json.loads(self.rfile.read(length))
            # Aplica contrato de modelos, roles y parámetros antes de reservar una consulta.
            model_id, messages = validate_request(body)
            # Indica si esta petición reservó una plaza de inferencia, para liberarla exactamente una vez.
            acquired = self.server.inference_slots.acquire(blocking=False)
            # Con cuatro consultas en curso/espera, devuelve 429 sin crear más trabajo de generación.
            if not acquired:
                # Informa saturación; el cliente debe esperar, sin cambiar silenciosamente de modelo.
                self.send_json(
                    429,
                    {
                        "error": {
                            "message": "Cola de inferencia completa; espera a terminar la comparación"
                        }
                    },
                )
                # Fin de la respuesta: no se reservó plaza ni se generó nada.
                return
            # Metadatos compatibles de la respuesta HTTP: identificador, fecha y alias del modelo.
            identity = {
                # Identificador único de esta respuesta (formato de OpenAI).
                "id": "chatcmpl-" + uuid.uuid4().hex,
                # Momento de creación en segundos desde 1970 (marca de tiempo Unix).
                "created": int(time.time()),
                # Alias del modelo pedido.
                "model": model_id,
            }
            # Generador del motor: produce texto y un último evento con consumo y motivo de parada.
            events = self.server.engine.events(model_id, messages)
            # El cliente decide entre recibir eventos progresivos o una respuesta JSON al terminar.
            if body.get("stream", False):
                # Pide el primer fragmento antes de enviar HTTP 200: si la generación falla al
                # comenzar, aún se puede responder con el código de error real.
                first = next(events)
                # Envía el código HTTP antes de las cabeceras y del cuerpo.
                self.send_response(200)
                # Añade permisos del navegador solo si corresponde al origen validado.
                self.cors_headers()
                # text/event-stream: el cuerpo es un flujo de eventos SSE.
                self.send_header("Content-Type", "text/event-stream; charset=utf-8")
                # Evita que las respuestas de la demo se almacenen en caché HTTP.
                self.send_header("Cache-Control", "no-store")
                # Cierra las cabeceras; a partir de aquí se escribe el cuerpo de respuesta.
                self.end_headers()
                # Recuerda que ya empezó SSE: un fallo posterior se comunica dentro del flujo.
                started = True

                # Convierte un evento del motor al formato SSE compatible y lo envía inmediatamente.
                def chunk(event):
                    # Cada evento de texto es un delta; el evento final no añade texto.
                    delta = {"content": event["content"]} if "content" in event else {}
                    # Añade metadatos compatibles y el motivo de parada a cada chunk.
                    data = {
                        # Mismo id, fecha y modelo en todos los fragmentos de esta respuesta.
                        **identity,
                        # Tipo de objeto de un fragmento en la API de OpenAI.
                        "object": "chat.completion.chunk",
                        "choices": [
                            {
                                # Primera (y única) alternativa.
                                "index": 0,
                                # Texto nuevo de este fragmento.
                                "delta": delta,
                                # None hasta el último evento, que trae stop o length.
                                "finish_reason": event.get("finish_reason"),
                            }
                        ],
                    }
                    # El último evento aporta consumo; se añade solo cuando el motor lo ha medido.
                    if "usage" in event:
                        # Conserva tokens de entrada/salida del evento final.
                        data["usage"] = event["usage"]
                    # Codifica la línea SSE o el error del flujo y lo escribe al cliente.
                    self.wfile.write(
                        (
                            "data: " + json.dumps(data, ensure_ascii=False) + "\n\n"
                        ).encode()
                    )
                    # Envía inmediatamente bytes pendientes para que el navegador muestre el fragmento.
                    self.wfile.flush()

                # Publica el fragmento inicial que ya demostró que podía empezar la inferencia.
                chunk(first)
                # Consume los fragmentos del motor en orden hasta el evento final de consumo/parada.
                for event in events:
                    # Traduce cada evento posterior al formato SSE compatible.
                    chunk(event)
                # Terminador SSE esperado por clientes compatibles; indica fin del flujo, no un fragmento del modelo.
                self.wfile.write(b"data: [DONE]\n\n")
                # Envía inmediatamente bytes pendientes para que el navegador muestre el fragmento.
                self.wfile.flush()
            else:
                # En modo no streaming se acumula texto y se conserva por separado el último evento de métricas.
                parts, last = [], {}
                # Consume los fragmentos del motor en orden hasta el evento final de consumo/parada.
                for event in events:
                    # Distingue un fragmento de respuesta del evento final con consumo/parada.
                    if "content" in event:
                        # Acumula cada fragmento original sin repararlo para la respuesta JSON final.
                        parts.append(event["content"])
                    else:
                        # Guarda el evento final que identifica motivo de parada y tokens.
                        last = event
                # Respuesta completa con el formato chat.completion de la API de OpenAI.
                self.send_json(
                    200,
                    {
                        **identity,
                        # Tipo de objeto de una respuesta completa.
                        "object": "chat.completion",
                        "choices": [
                            {
                                "index": 0,
                                # Mensaje del asistente con el texto completo.
                                "message": {
                                    "role": "assistant",
                                    "content": "".join(parts),
                                },
                                # Motivo de parada del evento final.
                                "finish_reason": last["finish_reason"],
                            }
                        ],
                        # Tokens de entrada y salida.
                        "usage": last["usage"],
                    },
                )
        # El navegador cerró la conexión: ya no hay a quién responder.
        except (BrokenPipeError, ConnectionResetError):
            # pass no hace nada; el finally de abajo libera los recursos.
            pass
        # Cualquier otro error de validación o de generación.
        except Exception as exc:
            # Tras iniciar SSE, comunica el error dentro del flujo; ya no puede cambiar el estado HTTP.
            if started:
                # Codifica la línea SSE o el error del flujo y lo escribe al cliente.
                self.wfile.write(
                    (
                        "data: " + json.dumps({"error": {"message": str(exc)}}) + "\n\n"
                    ).encode()
                )
                # Envía inmediatamente bytes pendientes para que el navegador muestre el fragmento.
                self.wfile.flush()
            else:
                # Errores de entrada reciben 400; fallos internos reciben 500.
                self.send_json(
                    400 if isinstance(exc, (ValueError, KeyError)) else 500,
                    {"error": {"message": str(exc)}},
                )
        finally:
            # Cierra el generador si llegó a crearse, también al desconectarse el navegador.
            if events is not None:
                # Cierra el generador; su finally cancela/espera al worker y libera el lock.
                events.close()
            # Solo devuelve plaza de inferencia si esta petición realmente la había adquirido.
            if acquired:
                # Devuelve la plaza al semáforo para que una petición posterior pueda utilizarla.
                self.server.inference_slots.release()


# Carga el motor y abre el servidor solo en loopback; Ctrl+C cierra el socket.
def main():
    # Parser de argumentos: describe las opciones que admite este comando.
    parser = argparse.ArgumentParser(description=__doc__)
    # --port: puerto local; 1235 por defecto para no chocar con LM Studio (1234).
    parser.add_argument("--port", type=int, default=1235)
    # --adaptador: carpeta del adaptador LoRA entrenado que se servirá como qwen-lora-soporte.
    parser.add_argument("--adaptador", default=str(ROOT / "modelos/lora-soporte"))
    # Argumentos de la terminal convertidos a atributos como args.port o args.adaptador.
    args = parser.parse_args()
    # Aviso inicial mientras se carga el modelo.
    print("Cargando el mismo Qwen y su adaptador de soporte…", flush=True)
    # Carga modelo y adaptador antes de empezar a escuchar consultas.
    engine = ComparisonEngine(args.adaptador)
    # Escucha solo en IPv4 loopback; no abre la demo en todas las interfaces de red.
    server = ComparisonServer(("127.0.0.1", args.port), engine)
    # URL /v1 para configurar isbetter.ai y metadatos del adaptador cargado.
    print(
        json.dumps(
            {
                # Dirección que se configura en isbetter.ai.
                "url": f"http://localhost:{args.port}/v1",
                # Alias disponibles.
                "models": MODEL_IDS,
                # Revisión, hash del adaptador, dispositivo…
                **engine.metadata,
            },
            ensure_ascii=False,
        ),
        flush=True,
    )
    # try/except/finally: Ctrl+C detiene el bucle y el socket se cierra.
    try:
        # Atiende peticiones hasta que Ctrl+C interrumpe el bucle.
        server.serve_forever()
    # Ctrl+C es la forma normal de parar el servidor: no se trata como error.
    except KeyboardInterrupt:
        # pass: salir del bucle es lo esperado.
        pass
    finally:
        # Cierra el socket del servidor también tras Ctrl+C o un error.
        server.server_close()


# Punto de entrada: ejecutar como script llama main; importar el módulo solo define sus funciones.
if __name__ == "__main__":
    # Invoca el punto de entrada únicamente cuando se ejecuta este archivo como programa.
    main()
