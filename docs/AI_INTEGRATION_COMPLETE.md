# ✅ Integración de IA Local (Ollama) - COMPLETADA

**Fecha**: 14 de Diciembre, 2025  
**Estado**: 🟢 Funcionando con GPU  
**Modelo**: phi3:mini  
**GPU**: NVIDIA GeForce GTX 1050 (3GB VRAM)

---

## 🎉 Resumen de Implementación

### ✅ Completado

1. **NVIDIA Container Toolkit Instalado**
   - Versión: 1.18.1-1
   - Instalado vía pacman en Arch Linux
   - Docker configurado con NVIDIA runtime
   - GPU detectada correctamente

2. **Ollama con GPU**
   - Servicio corriendo en puerto 11434
   - GPU detectada: GTX 1050 (CUDA 6.1, 2.9GB VRAM)
   - Modo "low vram" activado automáticamente
   - Modelo phi3:mini descargado (2.2GB)

3. **Backend API**
   - Endpoint `/api/v1/ai/query` - Consultar IA
   - Endpoint `/api/v1/ai/health` - Estado del servicio
   - Endpoint `/api/v1/ai/analyze-anomaly` - Analizar anomalías
   - Router registrado en main.py

4. **Docker Compose**
   - Servicio `ollama` con GPU support
   - Servicio `ollama-init` para descargar modelos
   - Volumen `ollama_data` creado

5. **Variables de Entorno**
   - Configuración en `.env.example`
   - `OLLAMA_URL=http://ollama:11434`
   - `OLLAMA_MODEL=phi3:mini`
   - `AI_ENABLED=true`

6. **Host Ollama Desactivado**
   - Servicio systemd detenido
   - Servicio systemd deshabilitado
   - Puerto 11434 liberado para Docker

---

## 🚀 Rendimiento

### Test de Latencia

**Consulta directa a Ollama**:
```
Prompt: "Explica en 1 línea qué es una anomalía de CPU"
Tiempo: 9.7 segundos
Respuesta: "Una anomalía de CPU se refiere a cualquier desviación o fallo 
que afecte su funcionamiento normal, como sobrecalentamiento, problemas 
con el arreglo lógico y temporal (TLB) o errores en la memoria caché."
```

**Nota**: Primera inferencia siempre es más lenta (carga modelo en VRAM).
Inferencias subsecuentes serán ~1-2 segundos.

### GPU Utilization

- **VRAM Usada**: ~2GB (modelo phi3:mini)
- **VRAM Disponible**: 2.9GB / 3GB
- **Compute Capability**: 6.1 (Pascal architecture)
- **Modo**: Low VRAM (optimizado para GPUs <20GB)

---

## 📊 Servicios Activos

```bash
# Ollama
http://localhost:11434

# Backend AI Endpoints
http://localhost:8000/api/v1/ai/health
http://localhost:8000/api/v1/ai/query
http://localhost:8000/api/v1/ai/analyze-anomaly
```

---

## 🧪 Comandos de Verificación

### Verificar GPU en Docker
```bash
docker run --rm --gpus all nvidia/cuda:12.0.0-base-ubuntu22.04 nvidia-smi
```

### Verificar Ollama
```bash
# Ver modelos instalados
curl http://localhost:11434/api/tags | jq '.models[].name'

# Test de inferencia
curl -X POST http://localhost:11434/api/generate \
  -d '{"model":"phi3:mini","prompt":"Hola","stream":false}' | jq -r '.response'
```

### Verificar Backend
```bash
# Health check
curl http://localhost:8000/api/v1/ai/health | jq

# Query
curl -X POST http://localhost:8000/api/v1/ai/query \
  -H "Content-Type: application/json" \
  -d '{"prompt":"Test","max_tokens":30}' | jq
```

### Ver logs de Ollama
```bash
docker-compose logs -f ollama | grep -i "gpu\|cuda"
```

---

## 📁 Archivos Modificados

1. `docker-compose.yml`
   - Agregado servicio `ollama` con GPU support
   - Agregado servicio `ollama-init`
   - Agregado volumen `ollama_data`

2. `.env.example`
   - Agregada sección de configuración Ollama

3. `backend/app/routers/ai.py`
   - Nuevo router con 3 endpoints

4. `backend/app/main.py`
   - Importado y registrado router AI

5. `/etc/docker/daemon.json`
   - Configurado NVIDIA runtime

---

## 🔄 Próximos Pasos

### 1. Integrar IA en AnomalyDetector
Modificar `backend/app/services/anomaly_detector.py` para enriquecer anomalías con explicaciones de IA.

### 2. Mejorar Watchdog de Seguridad
Actualizar `host-metrics/audit-watchdog.sh` para análisis inteligente de eventos.

### 3. Descargar Modelo Adicional
```bash
docker-compose exec ollama ollama pull llama3.2:1b
```

### 4. Crear Dashboards de IA
- Métricas de latencia de IA
- Uso de VRAM
- Queries por minuto

---

## 🐛 Troubleshooting

### Ollama no detecta GPU
```bash
# Verificar NVIDIA Container Toolkit
nvidia-ctk --version

# Verificar configuración de Docker
cat /etc/docker/daemon.json

# Reiniciar Docker
sudo systemctl restart docker
```

### Modelo no descarga
```bash
# Descargar manualmente
docker-compose exec ollama ollama pull phi3:mini

# Ver espacio en disco
df -h
```

### Backend no conecta con Ollama
```bash
# Verificar que Ollama esté corriendo
docker-compose ps ollama

# Verificar red
docker-compose exec backend ping ollama

# Ver logs
docker-compose logs backend | grep -i ollama
```

---

## 📈 Modelos Recomendados para GTX 1050 (3GB)

| Modelo | Tamaño | VRAM | Velocidad | Calidad |
|--------|--------|------|-----------|---------|
| ✅ phi3:mini | 1.3B | ~2GB | Rápido | Buena |
| ✅ llama3.2:1b | 1B | ~1.5GB | Muy rápido | Aceptable |
| ⚠️ llama3.2:3b | 3B | ~2.5GB | Moderado | Muy buena |
| ❌ llama3:8b | 8B | ~5GB | - | No cabe |

---

## 🎯 Estado Final

- ✅ NVIDIA Container Toolkit instalado
- ✅ Ollama corriendo con GPU (GTX 1050)
- ✅ Modelo phi3:mini descargado
- ✅ Backend API funcionando
- ✅ Host Ollama desactivado
- ⏳ Pendiente: Integración con AnomalyDetector
- ⏳ Pendiente: Mejora de watchdog

**Próxima acción**: Integrar IA en detector de anomalías para explicaciones automáticas
