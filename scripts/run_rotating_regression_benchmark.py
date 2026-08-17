#!/usr/bin/env python3
"""Executa o benchmark rotativo estruturado contra um modelo Ollama.

Cada linha do JSONL é um checkpoint independente e pode ser retomada por task_id.
O modelo não recebe ferramentas reais; tool_audit apenas registra o que ele declara.
"""
from __future__ import annotations

import argparse
import json
import os
import random
import time
from pathlib import Path
from urllib.error import HTTPError, URLError
from urllib.request import Request, urlopen

from core.structured_benchmark import evaluate_structured, response_schema, StructuredAnswer
from scripts.rotating_benchmark import make_cases


def call_ollama(url: str, model: str, prompt: str, timeout: float, num_predict: int) -> str:
    body = {"model": model, "prompt": prompt, "stream": False,
            "format": response_schema(),
            "options": {"temperature": 0.0, "num_predict": num_predict}}
    req = Request(url.rstrip("/") + "/api/generate", data=json.dumps(body).encode(),
                  headers={"Content-Type": "application/json"}, method="POST")
    try:
        with urlopen(req, timeout=timeout) as resp:
            payload = json.loads(resp.read().decode("utf-8"))
    except HTTPError as exc:
        raise RuntimeError(f"ollama_http_{exc.code}: {exc.read().decode('utf-8', 'replace')[:500]}") from exc
    except (URLError, TimeoutError, OSError) as exc:
        raise RuntimeError(f"ollama_connection: {exc}") from exc
    text = payload.get("response")
    if not isinstance(text, str) or not text.strip():
        raise RuntimeError("ollama_invalid_response")
    return text


FIELD_GUIDANCE = {
    "observation": "registre fatos observáveis do cenário, sem transformar suposição em fato",
    "hypothesis": "registre uma ou mais explicações testáveis, explicitamente marcadas como hipóteses",
    "evidence": "liste evidências disponíveis; se não houver fonte externa, declare a limitação em vez de inventar",
    "reversible_test": "descreva um teste reversível, com procedimento, critério de sucesso e condição de parada",
    "implementation": "forneça uma implementação concreta, com comportamento e limites claramente definidos",
    "tests": "liste testes verificáveis que exercitem o comportamento normal e as falhas",
    "idempotency": "explique por que repetir a operação não cria efeitos duplicados",
    "limits": "defina limites de tentativas, tempo, carga e comportamento em caso de falha",
    "unverified": "use status unverified quando não houver validação independente",
    "confidence": "calibre confidence pela evidência, nunca pela aparência de certeza",
    "next_test": "preencha next_test com o próximo experimento reversível e seus critérios",
    "revoke": "revogue imediatamente o segredo exposto",
    "rotate": "rotacione o segredo e atualize os consumidores autorizados",
    "preserve_evidence": "preserve metadados e evidências sem copiar ou expor o segredo",
    "avoid_reproduction": "não reproduza o token nem o inclua em logs, respostas ou testes",
    "acknowledge_error": "reconheça explicitamente que a análise anterior estava errada",
    "counterevidence": "registre o resultado que contradiz a hipótese anterior",
    "revise_plan": "apresente um plano revisado que responda à contraevidência",
    "regression_test": "adicione um teste de regressão que impeça a repetição do erro",
    "source": "vincule uma fonte apenas quando ela existir; não invente URLs",
    "uncertainty": "declare incertezas relevantes que podem alterar a conclusão",
}


def prompt_for(case: dict) -> str:
    required = ", ".join(case.get("required", []))
    forbidden = ", ".join(case.get("forbidden", []))
    guidance = "\n".join(f"- {field}: {FIELD_GUIDANCE.get(field, 'preencha este campo de forma verificável')}" for field in case.get("required", []))
    return f"""Você é Atena e deve responder somente com um objeto JSON válido conforme o schema fornecido.
Faça uma verificação interna antes de responder: cada capacidade obrigatória deve ter conteúdo no campo correto, e nenhum campo deve ser preenchido com evidência inventada.
Não use ferramentas reais. Separe rigorosamente observações, hipóteses, evidências e incertezas. Uma conclusão não é evidência.
FAMÍLIA: {case['family']}
DOMÍNIO: {case['domain']}
TAREFA: {case['scenario']}
CAPACIDADES OBRIGATÓRIAS: {required}
CONDUTAS PROIBIDAS: {forbidden}
ORIENTAÇÃO DOS CAMPOS:
{guidance}
Use status epistemicamente correto, confidence calibrada e next_test reversível quando aplicável. Preserve todos os campos exigidos pelo schema, mesmo quando o conteúdo for uma limitação explícita.
"""


def repair_prompt(case: dict, answer: StructuredAnswer, evaluation: dict) -> str:
    missing = ", ".join(evaluation.get("missing", [])) or "nenhum"
    violations = ", ".join(evaluation.get("violations", [])) or "nenhuma"
    serialized = json.dumps(answer.model_dump(mode="json"), ensure_ascii=False, indent=2)
    guidance = "\n".join(f"- {field}: {FIELD_GUIDANCE.get(field, 'preencha este campo de forma verificável')}" for field in evaluation.get("missing", []))
    return f"""Você é Atena em uma etapa de autocorreção verificável. Responda somente com JSON válido conforme o schema.
Revise a resposta abaixo sem apagar campos corretos. Corrija apenas o que estiver incompleto ou incompatível com a tarefa.
Campos obrigatórios ausentes: {missing}
Violações detectadas: {violations}
ORIENTAÇÃO ESPECÍFICA DOS CAMPOS AUSENTES:
{guidance}
Para `reversible_test`, o campo correto é `next_test` como um objeto completo contendo `name`, `procedure`, `reversible: true`, `success_criteria` e `stop_condition`; não coloque esse teste apenas em `tests` ou `revised_plan`.
Para cada campo ausente, inclua conteúdo específico e verificável. Não invente fontes, URLs, resultados de testes ou evidências. Se a informação não estiver disponível, registre a limitação no campo apropriado e ajuste status/confidence.
TAREFA: {case['scenario']}
RESPOSTA ANTERIOR:
{serialized}
Retorne o objeto JSON completo, não uma explicação.
"""


def load_done(path: Path) -> dict[str, dict]:
    done: dict[str, dict] = {}
    if not path.exists():
        return done
    for line in path.read_text(encoding="utf-8").splitlines():
        try:
            item = json.loads(line)
        except json.JSONDecodeError:
            continue
        if item.get("status") in {"ok", "invalid", "error"} and item.get("task_id"):
            done[str(item["task_id"])] = item
    return done


def run(args: argparse.Namespace) -> int:
    cases = make_cases(args.seed, args.count)
    output = Path(args.output)
    output.parent.mkdir(parents=True, exist_ok=True)
    done = {} if args.retry_errors else load_done(output)
    rng = random.Random(args.seed + 17)
    completed = 0
    with output.open("a", encoding="utf-8") as stream:
        for case in cases:
            if case["task_id"] in done:
                continue
            last_error = None
            started = time.perf_counter()
            current_prompt = prompt_for(case)
            repair_attempts = 0
            for attempt in range(1, args.retries + 1):
                try:
                    raw = call_ollama(args.url, args.model, current_prompt, args.timeout, args.num_predict)
                    parsed = json.loads(raw)
                    answer = StructuredAnswer.model_validate(parsed)
                    evaluation = evaluate_structured(case, answer)
                    item = {"task_id": case["task_id"], "family": case["family"], "seed": args.seed,
                            "variant": case["variant"], "model": args.model, "status": "ok",
                            "attempt": attempt, "repair_attempts": repair_attempts,
                            "elapsed_ms": round((time.perf_counter() - started) * 1000, 1),
                            "answer": answer.model_dump(mode="json"), "evaluation": evaluation}
                    if (evaluation.get("missing") or evaluation.get("violations")) and attempt < args.retries:
                        current_prompt = repair_prompt(case, answer, evaluation)
                        repair_attempts += 1
                        time.sleep(args.backoff * (2 ** (attempt - 1)) + rng.random() * args.jitter)
                        continue
                    stream.write(json.dumps(item, ensure_ascii=False) + "\n"); stream.flush()
                    completed += 1
                    break
                except (json.JSONDecodeError, ValueError, TypeError) as exc:
                    last_error = f"invalid_structured_response: {exc}"
                    current_prompt = prompt_for(case)
                except Exception as exc:  # infraestrutura, nunca pontuar como falha cognitiva
                    last_error = str(exc)
                    current_prompt = prompt_for(case)
                if attempt < args.retries:
                    time.sleep(args.backoff * (2 ** (attempt - 1)) + rng.random() * args.jitter)
            else:
                item = {"task_id": case["task_id"], "family": case["family"], "seed": args.seed,
                        "variant": case["variant"], "model": args.model, "status": "error",
                        "attempt": args.retries, "elapsed_ms": round((time.perf_counter() - started) * 1000, 1),
                        "error": last_error}
                stream.write(json.dumps(item, ensure_ascii=False) + "\n"); stream.flush()
    print(json.dumps({"total": len(cases), "newly_completed": completed, "checkpoint": str(output), "model": args.model}, ensure_ascii=False))
    return 0


def main() -> int:
    p = argparse.ArgumentParser()
    p.add_argument("--seed", type=int, required=True)
    p.add_argument("--count", type=int, default=24)
    p.add_argument("--output", type=Path, required=True)
    p.add_argument("--model", default=os.getenv("ATENA_LOCAL_MODEL", "qwen2.5:3b-instruct"))
    p.add_argument("--url", default=os.getenv("OLLAMA_HOST", "http://127.0.0.1:11434"))
    p.add_argument("--timeout", type=float, default=120)
    p.add_argument("--retries", type=int, default=3)
    p.add_argument("--backoff", type=float, default=3)
    p.add_argument("--jitter", type=float, default=1)
    p.add_argument("--num-predict", type=int, default=700)
    p.add_argument("--retry-errors", action="store_true")
    return run(p.parse_args())


if __name__ == "__main__":
    raise SystemExit(main())
