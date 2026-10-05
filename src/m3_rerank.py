from __future__ import annotations

"""Module 3: Reranking — Cross-encoder top-20 → top-3 + latency benchmark."""

import os, sys, time
if hasattr(sys.stdout, "reconfigure"):
    sys.stdout.reconfigure(encoding="utf-8")
if hasattr(sys.stderr, "reconfigure"):
    sys.stderr.reconfigure(encoding="utf-8")
from dataclasses import dataclass

sys.path.insert(0, os.path.dirname(os.path.dirname(os.path.abspath(__file__))))
from config import RERANK_TOP_K


@dataclass
class RerankResult:
    text: str
    original_score: float
    rerank_score: float
    metadata: dict
    rank: int


class CrossEncoderReranker:
    # Model ~2.2GB, nạp mất vài giây → dùng chung giữa các instance cùng model_name
    _model_cache: dict[str, object] = {}

    def __init__(self, model_name: str = "BAAI/bge-reranker-v2-m3", max_length: int = 512):
        self.model_name = model_name
        # bge-reranker-v2-m3 mặc định nhận tới 8192 token; giới hạn 512 đủ cho
        # (query + chunk) và giữ latency thấp vì chi phí attention tăng theo độ dài.
        self.max_length = max_length
        self._model = None

    def _load_model(self):
        if self._model is None:
            # Dùng sentence_transformers.CrossEncoder, KHÔNG dùng FlagEmbedding:
            # FlagReranker crash với transformers>=5.0 (XLMRobertaTokenizer lỗi).
            key = f"{self.model_name}@{self.max_length}"
            if key not in self._model_cache:
                from sentence_transformers import CrossEncoder
                self._model_cache[key] = CrossEncoder(self.model_name, max_length=self.max_length)
            self._model = self._model_cache[key]
        return self._model

    def rerank(self, query: str, documents: list[dict], top_k: int = RERANK_TOP_K) -> list[RerankResult]:
        """Rerank documents: top-20 → top-k.

        Cross-encoder đọc cặp (query, doc) cùng lúc nên so khớp được từng từ —
        chính xác hơn bi-encoder ở tầng search, nhưng chỉ đủ rẻ khi chạy trên ít ứng viên.
        """
        if not documents or top_k <= 0:
            return []
        model = self._load_model()
        pairs = [(query, doc["text"]) for doc in documents]
        scores = model.predict(pairs, batch_size=32, show_progress_bar=False)
        if isinstance(scores, (int, float)):
            scores = [scores]

        scored = sorted(zip(scores, documents), key=lambda x: float(x[0]), reverse=True)
        return [
            RerankResult(text=doc["text"], original_score=float(doc.get("score", 0.0)),
                         rerank_score=float(score), metadata=doc.get("metadata", {}), rank=i)
            for i, (score, doc) in enumerate(scored[:top_k])
        ]


class FlashrankReranker:
    """Lightweight alternative (<5ms). Optional."""
    # Model mặc định của flashrank (ms-marco-TinyBERT) chỉ train tiếng Anh → dùng bản multilingual
    def __init__(self, model_name: str = "ms-marco-MultiBERT-L-12"):
        self.model_name = model_name
        self._model = None

    def rerank(self, query: str, documents: list[dict], top_k: int = RERANK_TOP_K) -> list[RerankResult]:
        if not documents or top_k <= 0:
            return []
        from flashrank import Ranker, RerankRequest
        if self._model is None:
            self._model = Ranker(model_name=self.model_name)
        passages = [{"id": i, "text": d["text"]} for i, d in enumerate(documents)]
        results = self._model.rerank(RerankRequest(query=query, passages=passages))
        out = []
        for rank, r in enumerate(results[:top_k]):  # flashrank trả về đã sort giảm dần
            doc = documents[r["id"]]
            out.append(RerankResult(text=doc["text"], original_score=float(doc.get("score", 0.0)),
                                    rerank_score=float(r["score"]), metadata=doc.get("metadata", {}),
                                    rank=rank))
        return out


def benchmark_reranker(reranker, query: str, documents: list[dict], n_runs: int = 5) -> dict:
    """Benchmark latency over n_runs. (Đã implement sẵn)"""
    times = []
    for _ in range(n_runs):
        start = time.perf_counter()
        reranker.rerank(query, documents)
        elapsed = (time.perf_counter() - start) * 1000
        times.append(elapsed)
    return {"avg_ms": sum(times) / len(times), "min_ms": min(times), "max_ms": max(times)}


if __name__ == "__main__":
    query = "Nhân viên được nghỉ phép bao nhiêu ngày?"
    docs = [
        {"text": "Nhân viên được nghỉ 12 ngày/năm.", "score": 0.8, "metadata": {}},
        {"text": "Mật khẩu thay đổi mỗi 90 ngày.", "score": 0.7, "metadata": {}},
        {"text": "Thời gian thử việc là 60 ngày.", "score": 0.75, "metadata": {}},
    ]
    reranker = CrossEncoderReranker()
    for r in reranker.rerank(query, docs):
        print(f"[{r.rank}] {r.rerank_score:.4f} | {r.text}")
