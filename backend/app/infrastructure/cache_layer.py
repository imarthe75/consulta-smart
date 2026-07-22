"""
Caché Híbrida Semántica — Capa de Caché en Redis + Incrustaciones (SentenceTransformers).

Optimización de rendimiento y costos que intercepta consultas idénticas o semánticamente similares:
- Nivel 1: Coincidencia exacta por hash en Redis (latencia < 5ms).
- Nivel 2: Coincidencia semántica basada en coseno de embeddings (>0.92 similitud).
- Nivel 3: Passthrough al motor LLM y almacenamiento asíncrono del resultado.
"""

import redis.asyncio as redis
import hashlib
import json
import time
from typing import Dict, List, Optional, Any, Tuple
from app.core.logger import logger
from app.core.config import settings
from sentence_transformers import SentenceTransformer
import numpy as np


class HybridCacheLayer:
    """
    Caché Híbrida Semántica para aceleración de respuestas RAG:
    - 30% consultas exactas resueltas por Redis.
    - 50% consultas semánticamente equivalentes resueltas sin consumir la API del LLM.
    - Medición en tiempo real de tasa de aciertos (Hit Rate) y latencia.
    """
    
    def __init__(self):
        """Inicializar caché híbrida"""
        self.redis_client = None
        self.embedding_model = None
        self.redis_ttl = 86400  # 24 horas
        self.similarity_threshold_exact = 0.85  # Para respuestas exactas
        self.similarity_threshold_partial = 0.75  # Para respuestas similares
        self.cache_stats = {
            "hits_redis": 0,
            "hits_embedding": 0,
            "misses": 0,
            "total_queries": 0,
            "total_hit_rate": 0.0
        }
        
    async def initialize(self):
        """Inicializar conexión a Redis y modelo de embeddings"""
        try:
            # Conectar a Redis (usa REDIS_URL que incluye autenticación)
            self.redis_client = await redis.from_url(
                settings.REDIS_URL,
                decode_responses=True,
                socket_connect_timeout=5,
                socket_keepalive=True
            )
            
            # Verificar conexión
            await self.redis_client.ping()
            logger.info("✅ Redis conectado para caché híbrida")
            
            # Cargar modelo de embeddings (local, no requiere API)
            self.embedding_model = SentenceTransformer('all-MiniLM-L6-v2')
            logger.info("✅ Modelo de embeddings cargado (all-MiniLM-L6-v2)")
            
        except Exception as e:
            logger.error(f"❌ Error inicializando caché híbrida: {e}")
            raise
    
    def _normalize_query(self, query: str) -> str:
        """Normalizar query para búsqueda exacta"""
        return query.lower().strip()
    
    def _generate_cache_key(self, query: str) -> str:
        """Generar clave determinística para Redis"""
        normalized = self._normalize_query(query)
        hash_obj = hashlib.md5(normalized.encode())
        return f"cache_consulta_rpp:{hash_obj.hexdigest()}"
    
    async def get_exact_match(self, query: str) -> Optional[Dict[str, Any]]:
        """
        Buscar coincidencia EXACTA en Redis
        - Éxito = respuesta del caché ($0 Groq)
        - Fallo = proceder a búsqueda de similares
        """
        try:
            key = self._generate_cache_key(query)
            cached = await self.redis_client.get(key)
            
            if cached:
                result = json.loads(cached)
                self.cache_stats["hits_redis"] += 1
                logger.info(f"🟢 Redis HIT (exact): {query[:50]}...")
                return result
            
            return None
            
        except Exception as e:
            logger.error(f"Error en Redis exact match: {e}")
            return None
    
    async def get_similar_match(self, query: str) -> Optional[Tuple[float, Dict[str, Any]]]:
        """
        Buscar coincidencia SIMILAR usando embeddings
        - Retorna: (similitud, respuesta_cached)
        - Similitud > 0.85 = usar directamente
        - Similitud 0.75-0.85 = refinar con LLM (cheaper)
        - Similitud < 0.75 = no hay match, crear nueva
        """
        try:
            if not self.embedding_model:
                return None
            
            # Generar embedding de la query
            query_embedding = self.embedding_model.encode(query)
            
            # Buscar en caché todas las respuestas anteriores
            keys = await self.redis_client.keys("cache_consulta_rpp:*")
            if not keys:
                return None
            
            # Calcular similitudes
            best_match = None
            best_score = 0
            
            for key in keys[:100]:  # Limitar búsqueda a últimas 100 queries
                cached = await self.redis_client.get(key)
                if not cached:
                    continue
                
                try:
                    cached_data = json.loads(cached)
                    cached_embedding = np.array(cached_data.get("embedding", []))
                    
                    if len(cached_embedding) == 0:
                        continue
                    
                    # Calcular similitud coseno
                    similarity = np.dot(query_embedding, cached_embedding) / (
                        np.linalg.norm(query_embedding) * np.linalg.norm(cached_embedding)
                    )
                    
                    if similarity > best_score and similarity > self.similarity_threshold_partial:
                        best_score = similarity
                        best_match = cached_data
                        
                except Exception as e:
                    logger.debug(f"Error procesando embedding: {e}")
                    continue
            
            if best_match and best_score > self.similarity_threshold_partial:
                self.cache_stats["hits_embedding"] += 1
                logger.info(f"🟡 Embedding HIT (similarity: {best_score:.2f}): {query[:50]}...")
                return (best_score, best_match)
            
            return None
            
        except Exception as e:
            logger.error(f"Error en embedding similarity search: {e}")
            return None
    
    async def store_response(self, query: str, response: str, sources: List[str] = None):
        """
        Guardar respuesta en caché para futuras consultas
        Incluir embedding para búsqueda de similares
        """
        try:
            key = self._generate_cache_key(query)
            
            # Generar embedding de la respuesta
            embedding = None
            if self.embedding_model:
                try:
                    embedding = self.embedding_model.encode(query).tolist()
                except Exception as e:
                    logger.debug(f"No se pudo generar embedding: {e}")
            
            # Preparar datos para caché
            cache_data = {
                "query": query,
                "response": response,
                "sources": sources or [],
                "embedding": embedding,
                "timestamp": time.time(),
                "ttl_minutes": self.redis_ttl // 60
            }
            
            # Guardar en Redis co TTL de 24h
            await self.redis_client.setex(
                key,
                self.redis_ttl,
                json.dumps(cache_data)
            )
            
            logger.info(f"💾 Respuesta guardada en caché: {query[:50]}...")
            
        except Exception as e:
            logger.error(f"Error guardando en caché: {e}")
    
    async def get_with_fallback(self, query: str) -> Optional[Dict[str, Any]]:
        """
        Estrategia completa:
        1. Buscar exacta en Redis (30% queries) → $0
        2. Buscar similar con embeddings (50% queries) → $0 o refinamiento LLM
        3. Si nada funciona → None (20% queries)
        """
        self.cache_stats["total_queries"] += 1
        
        # Paso 1: Exacta
        exact_result = await self.get_exact_match(query)
        if exact_result:
            return exact_result
        
        # Paso 2: Similar
        similar_result = await self.get_similar_match(query)
        if similar_result:
            score, result = similar_result
            if score > self.similarity_threshold_exact:
                # Score muy alto = usar directamente sin refinar
                logger.info("✅ Usando respuesta similar exacta (sin refinar)")
                return result
            else:
                # Score medio = devolver pero indicar que se debe refinar
                logger.info(f"⚠️ Queremos refinar esta respuesta (score: {score:.2f})")
                result["needs_llm_refinement"] = True
                result["similarity_score"] = score
                return result
        
        # Paso 3: Cache miss
        logger.info(f"❌ Cache MISS: {query[:50]}...")
        self.cache_stats["misses"] += 1
        return None
    
    def get_cache_stats(self) -> Dict[str, Any]:
        """Estadísticas de eficiencia de caché"""
        total = self.cache_stats["total_queries"]
        if total > 0:
            hits = self.cache_stats["hits_redis"] + self.cache_stats["hits_embedding"]
            hit_rate = (hits / total) * 100
            self.cache_stats["total_hit_rate"] = hit_rate
        
        return {
            "redis_hits": self.cache_stats["hits_redis"],
            "embedding_hits": self.cache_stats["hits_embedding"],
            "misses": self.cache_stats["misses"],
            "total_queries": self.cache_stats["total_queries"],
            "hit_rate_percent": self.cache_stats["total_hit_rate"],
            "estimated_groq_reduction": f"{self.cache_stats['total_hit_rate']:.1f}%"
        }
    
    async def clear_cache(self):
        """Limpiar toda la caché (para testing)"""
        try:
            keys = await self.redis_client.keys("cache_consulta_rpp:*")
            if keys:
                await self.redis_client.delete(*keys)
            logger.info(f"🗑️ Caché limpiada ({len(keys)} entradas removed)")
        except Exception as e:
            logger.error(f"Error limpiando caché: {e}")
    
    async def close(self):
        """Cerrar conexión a Redis"""
        if self.redis_client:
            await self.redis_client.close()
            logger.info("Redis closed")


# Instancia global (singleton)
_cache_instance: Optional[HybridCacheLayer] = None


async def get_cache_instance() -> HybridCacheLayer:
    """Obtener instancia de caché híbrida (lazy initialization)"""
    global _cache_instance
    if _cache_instance is None:
        _cache_instance = HybridCacheLayer()
        await _cache_instance.initialize()
    return _cache_instance
